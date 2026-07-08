---
title: '从 GEMM 理解 Triton DSL'
date: 2025-10-20
permalink: /posts/2025/10/triton-gemm/
tags:
  - Triton
  - Triton DSL
  - GEMM
---


**目标**：用 1 个 GEMM 例子，把 GPU 硬件概念、Triton 软件抽象、代码执行流程串成一条线。

---

## 1. GPU 计算基础速览

```
GPU
└── SM ×80
    ├── Warp Scheduler ×4
    │   └── 调度 Warp（32线程）
    ├── CUDA Core ×128   ← 通用算数与逻辑单元（ALU）（FP32/INT32）
    └── Tensor Core ×4   ← 专用矩阵乘加阵列
```

### 计算单元
| 计算单元 | 描述 | CPU 参考概念 |
|---|---|---|
| **SM** | 流式多处理器，含 4 × Tensor Core + Shared + Register File | CPU 物理核心 (Core) |
| **Warp** | 单指令流多数据流（SIMD）处理单元，包含 32 线程，它们在同一周期执行同一条指令，是 GPU 调度&执行的最小单元 | 向量指令 (AVX-512) 处理的数据通道 |
| **CUDA Core** | FP32/INT32 通用标量 ALU（硬件单元） | ALU / FPU |
| **Tensor Core** | 专用矩阵乘加阵列（硬件单元），采用脉动阵列结构，一条指令完成 `mma(m,n,k)` 小矩阵乘加 | CPU 的 FMA 单元 或 AMX 加速器 |

> 脉动阵列（systolic array）形象：数据像“水滴”在阵列里流动，每个周期产生部分和，峰值算力 = 阵列尺寸 × 频率。

### 存储层级
| 硬件层级 | 容量 | 延迟 | 角色 |
|---|---|---|---|
| **Register** | 256 KB/SM | ~1 cycle | 真正的计算操作数 |
| **Shared Memory** | 164 KB/SM (Ada) | ~10 cycle | 同 block 线程共享，软件可控 cache |
| **L2 Cache** | MB 级 | ~100 cycle | 全局缓存，自动换入换出 |
| **Global Memory** | GB 级 | ~400 cycle | 主显存，DMA 搬运 |

---

## 2. 算子视角：大矩阵 → 小 tile → program
| 概念 | 解释 |
|---|---|
| **大矩阵** | 逻辑尺寸 M×K、K×N，常驻 Global Memory |
| **tile** | 能塞进寄存器/shared 的小块，如 64×64、128×32 |
| **block** | CUDA 语境下 = 1 个 thread-block；Triton 里 = 1 个 **program** |
| **program** | Triton 抽象，1 个 program 负责输出 **一个 tile** (BLOCK_SIZE_M × BLOCK_SIZE_N) |
| **grid** | 所有 program 的集合，二维排列 `(num_pid_m, num_pid_n)` |

### 拆分公式
```
num_pid_m = ceil(M / BLOCK_SIZE_M)
num_pid_n = ceil(N / BLOCK_SIZE_N)
grid(pid) → (pid_m, pid_n)  // 由 Triton 映射代码算出
```

---

## 3. Triton GEMM 算子代码
```python
@triton.autotune(...)
@triton.jit
def matmul_kernel(
    # Pointers to matrices
    a_ptr,
    b_ptr,
    c_ptr,
    # Matrix dimensions
    M,
    N,
    K,
    # The stride variables represent how much to increase the ptr by when moving by 1
    # element in a particular dimension. E.g. `stride_am` is how much to increase `a_ptr`
    # by to get the element one row down (A has M rows).
    stride_am,
    stride_ak,  #
    stride_bk,
    stride_bn,  #
    stride_cm,
    stride_cn,
    # Meta-parameters
    BLOCK_SIZE_M: tl.constexpr,
    BLOCK_SIZE_N: tl.constexpr,
    BLOCK_SIZE_K: tl.constexpr,  #
    GROUP_SIZE_M: tl.constexpr,  #
    ACTIVATION: tl.constexpr,  #
):
    """Kernel for computing the matmul C = A x B.
    A has shape (M, K), B has shape (K, N) and C has shape (M, N)
    """
    # -----------------------------------------------------------
    # 1. 计算 pid_m, pid_n
    pid = tl.program_id(axis=0)
    num_pid_m = tl.cdiv(M, BLOCK_SIZE_M)
    num_pid_n = tl.cdiv(N, BLOCK_SIZE_N)
    num_pid_in_group = GROUP_SIZE_M * num_pid_n
    group_id = pid // num_pid_in_group
    first_pid_m = group_id * GROUP_SIZE_M
    group_size_m = min(num_pid_m - first_pid_m, GROUP_SIZE_M)
    pid_m = first_pid_m + ((pid % num_pid_in_group) % group_size_m)
    pid_n = (pid % num_pid_in_group) // group_size_m

    # -----------------------------------------------------------
    # Add some integer bound assumptions.
    # This helps to guide integer analysis in the backend to optimize
    # load/store offset address calculation
    tl.assume(pid_m >= 0)
    tl.assume(pid_n >= 0)
    tl.assume(stride_am > 0)
    tl.assume(stride_ak > 0)
    tl.assume(stride_bn > 0)
    tl.assume(stride_bk > 0)
    tl.assume(stride_cm > 0)
    tl.assume(stride_cn > 0)

    # 1. 造指针
    # `a_ptrs` is a block of [BLOCK_SIZE_M, BLOCK_SIZE_K] pointers
    # `b_ptrs` is a block of [BLOCK_SIZE_K, BLOCK_SIZE_N] pointers
    offs_am = (pid_m * BLOCK_SIZE_M + tl.arange(0, BLOCK_SIZE_M)) % M
    offs_bn = (pid_n * BLOCK_SIZE_N + tl.arange(0, BLOCK_SIZE_N)) % N
    offs_k = tl.arange(0, BLOCK_SIZE_K)
    a_ptrs = a_ptr + (offs_am[:, None] * stride_am + offs_k[None, :] * stride_ak)
    b_ptrs = b_ptr + (offs_k[:, None] * stride_bk + offs_bn[None, :] * stride_bn)

    # -----------------------------------------------------------
    accumulator = tl.zeros((BLOCK_SIZE_M, BLOCK_SIZE_N), dtype=tl.float32)
    # 4. 循环
    for k in range(0, tl.cdiv(K, BLOCK_SIZE_K)):
        # 2. 搬数据
        a = tl.load(a_ptrs, mask=offs_k[None, :] < K - k * BLOCK_SIZE_K, other=0.0)
        b = tl.load(b_ptrs, mask=offs_k[:, None] < K - k * BLOCK_SIZE_K, other=0.0)
        # 3. 计算
        accumulator = tl.dot(a, b, accumulator)
        # Advance the ptrs to the next K block.
        a_ptrs += BLOCK_SIZE_K * stride_ak
        b_ptrs += BLOCK_SIZE_K * stride_bk
    # 5. 激活
    if ACTIVATION == "leaky_relu":
        accumulator = leaky_relu(accumulator)
    c = accumulator.to(tl.float16)

    # -----------------------------------------------------------
    # 6. 写回
    offs_cm = pid_m * BLOCK_SIZE_M + tl.arange(0, BLOCK_SIZE_M)
    offs_cn = pid_n * BLOCK_SIZE_N + tl.arange(0, BLOCK_SIZE_N)
    c_ptrs = c_ptr + stride_cm * offs_cm[:, None] + stride_cn * offs_cn[None, :]
    c_mask = (offs_cm[:, None] < M) & (offs_cn[None, :] < N)
    tl.store(c_ptrs, c, mask=c_mask)
```

### 算法解析

![Illustration GEMM](/images/202510/gpu-gemm.png)

C的1个block（BM*BN），由1个GPU program 进行运算。program 类似CPU的进程。

它由A的一block行、B的一block列进行计算得到。这样仍然会超出一个Tensor核可计算的范围，因此需要在K方向拆分为BK大小，再进行累加。（代码中for循环部分）

---

## 4. 六步拆解：从指针到结果
| 步骤 | Triton 代码片段 | 硬件动作 |
|---|---|---|
| **0. 算坐标** | `pid_m, pid_n = map_pid_to_tile(...)` | 寄存器内整数运算 |
| **1. 造指针** | `a_ptrs, b_ptrs = ...` | 寄存器地址计算 |
| **2. 搬数据** | `a = tl.load(...), b = tl.load(...)` | Global → Register（L2 可能命中） |
| **3. 计算** | `acc = tl.dot(a_tile, b_tile, acc)` | Tensor Core 脉动阵列 mma |
| **4. 循环** | `for k in range(...)` | 软件 pipeline，double-buffer 隐藏延迟 |
| **5. 激活** | `accumulator = leaky_relu(accumulator)` | 寄存器内逐元素 |
| **6. 写回** | `tl.store(...)` | Register → Global（写合并） |

> Tensor Core 实际尺寸 16×16×16，Triton 会把 64×64×32 拆成 4×4×2 条 mma 指令自动发射。

---

## 5. 概念对照表（一句话版）
| 术语 | 等价于 | 记忆口诀 |
|---|---|---|
| tile | 子矩阵 | 大蛋糕切小块 |
| program | CUDA thread-block | 1 个 program 管 1 块 tile |
| BLOCK_SIZE_ | tile 边长 | 64/128 最常用 |
| GROUP_SIZE_M | 行方向打包 | 让相邻 program 复用 A，L2 友好 |
| tl.dot | mma 指令 | Python 里的 Tensor Core |
| autotune | 暴力搜优 | 写 1 份代码，跑 20 份配置，选最快 |

---

## 6. 小结

```
Global Memory                    Register / Shared
┌---------------┐                ┌---------------┐
│   A  M×K      │                │ a_tile BM×BK  │
│   B  K×N      │   tl.load      │ b_tile BK×BN  │
│   C  M×N      │  --------->    │ acc   BM×BN   │  <- tl.dot
└---------------┘                └---------------┘
       ^     tl.store                    │
       |___________finish_________________|
```
从大到小：矩阵 → tile → 指针；
从慢到快：Global → L2 → Shared → Register → Tensor Core。
