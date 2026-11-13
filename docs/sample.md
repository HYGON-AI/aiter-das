<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# sample（module_sample）

`aiter.ops.sample` 提供从 **logits** 直接出 token 的采样接口：`greedy_sample`、`random_sample`、`mixed_sample`、各自的 `*_outer_exponential` 变体，以及独立的噪声生成 `exponential`。整条路径（温度缩放 → softmax → 指数噪声 → argmax）融合在一个 kernel 内，调用方不需要先算 softmax。

> **与 `sampling` 的区别**：[sampling.md](./sampling.md) 里的 `module_sampling` 接收**已归一化的概率**并做 top-k / top-p 截断采样；本文的 `module_sample` 接收**未归一化的 logits**、不做截断，走的是 Gumbel-max 形式的全词表采样。两者是互补的两套接口，模块与源文件均独立。

## 1. 算子功能

对每一行独立采样一个 token。符号约定：

| 符号 | 含义 |
|---|---|
| `M` | 行数（请求数），即 `input.size(0)` |
| `N` | 词表大小，即 `input.size(1)` |
| `t` | 该行的温度 |
| `e` | 该行该列的指数分布噪声 |
| `eps` | 除零保护项 |

```text
greedy_sample:
    out[i] = argmax_j  input[i,j]

random_sample / random_sample_outer_exponential:
    p = softmax( input[i,:] / t[i] )
    out[i] = argmax_j  p[j] / ( e[i,j] + eps )

mixed_sample / mixed_sample_outer_exponential:
    t[i] == 0 的行 → 退化为 argmax（greedy）
    t[i] != 0 的行 → 同 random_sample

exponential:
    out[i,j] = 指数分布样本（lambd 为率参数）
```

`argmax(p / e)` 是 Gumbel-max 技巧的等价形式：当 `e` 服从 Exp(1) 时，该式的结果分布正比于 `p`。

**`*_outer_exponential` 与内部 RNG 两种形态**：

- `*_outer_exponential`：噪声张量由调用方传入。**给定同一份 `exponentials`，输出是输入的纯函数**，可逐位复现，也便于与参考实现对齐。
- `random_sample` / `mixed_sample`：噪声在 kernel 内用 Philox 生成，省一次 `N*M` 的显存往返，但结果取决于 generator 状态。

**边界语义**：

- `mixed_sample*` 的 `temperature == 0` 行走 argmax 分支，与 `greedy_sample` 同一套实现；同一次调用里 0 与非 0 的行可以混合。
- `eps` 加在噪声上（`p / (e + eps)`），用于避免噪声取到 0 时除零。
- 输出 token id 恒落在 `[0, N)`；`N` 不是向量宽度整数倍、或 `N <= (BlockSize-1)*VecSize` 的形状已被专门覆盖（见第 4 节的两个边界断言）。

**负向范围**：

- **不做 top-k / top-p 截断**。需要截断采样时用 `module_sampling`（见 [sampling.md](./sampling.md)）。
- 每行只出一个 token，不支持一次多采样、去重或返回 TopK 列表。
- 无 `out` 自动分配 —— 所有接口都要求调用方预先分配输出。
- 无 autograd，仅供推理使用。
- 温度为逐行张量，不接受 Python 标量。

## 2. 接口与参数

```python
import aiter

aiter.greedy_sample(out, input)

aiter.random_sample(out, input, temperatures, lambd=1.0, generator=None, eps=1e-10)
aiter.random_sample_outer_exponential(out, input, exponentials, temperatures, eps=1e-10)

aiter.mixed_sample(out, input, temperature, lambd=1.0, generator=None, eps=1e-10)
aiter.mixed_sample_outer_exponential(out, input, exponentials, temperature, eps=1e-10)

aiter.exponential(out, lambd=1.0, generator=None, eps=1e-10)
```

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `out` | `torch.int32 [M]`（`exponential` 为 `[M, N]` FP32） | 必须预先分配 |
| `input` | `torch.Tensor [M, N]`，FP32 / FP16 / BF16 | **logits**，不是概率 |
| `temperatures` / `temperature` | `torch.float32 [M]` | 逐行温度；`mixed_sample*` 中 `0` 表示该行走 greedy |
| `exponentials` | `torch.float32 [M, N]` | 仅 `*_outer_exponential` 需要；由调用方提供的 Exp 噪声 |
| `lambd` | Python `float`，默认 `1.0` | 内部 RNG 形态的指数分布率参数 |
| `generator` | 可选 `torch.Generator` | 缺省用该 device 的 default generator |
| `eps` | Python `float`，默认 `1e-10` | 噪声的除零保护 |
| 返回值 | `None` | 结果写入 `out` |

所有张量须在同一 GPU 上且不需要梯度。

**检查边界**：native 侧校验 dtype 与基本形状；对 `temperature` 取值范围、`exponentials` 的分布、`input` 是否含 NaN 均不检查，由调用方保证。

### 随机数与确定性

内部 RNG 形态（`random_sample` / `mixed_sample` / `exponential`）使用 Philox，`(seed, offset)` 由 Python 层从 torch generator 读出后以普通整数传入 —— native 侧是 torch-free 的，不接 `at::Generator`。每次调用后把 generator 的 offset 推进 `((numel-1) // (1024*M*4) + 1) * 4`，与 kernel 的 `block_size=1024, unroll=4, grid.x=M` 对应，因此连续调用产生不同样本。

需要逐位复现时，用 `*_outer_exponential` 形态自行固定噪声张量，这比依赖 generator 状态更直接。

## 3. 使用方式

### 内部 RNG 形态（省一次显存往返）

```python
import torch
import aiter

device = torch.device("cuda:0")
M, N = 32, 151936

logits = torch.randn(M, N, device=device, dtype=torch.bfloat16)
temps = torch.full((M,), 0.7, device=device, dtype=torch.float32)
out = torch.empty(M, dtype=torch.int32, device=device)

aiter.random_sample(out, logits, temps)
assert out.shape == (M,) and out.dtype == torch.int32
```

### 混合 greedy / random（逐行温度，0 表示 greedy）

```python
temps = torch.full((M,), 0.7, device=device, dtype=torch.float32)
temps[::2] = 0.0                      # 偶数行走 argmax
aiter.mixed_sample(out, logits, temps)
```

### 外部噪声形态（可复现、便于对齐参考实现）

```python
expo = torch.empty(M, N, device=device, dtype=torch.float32).exponential_(1)
aiter.random_sample_outer_exponential(out, logits, expo, temps, eps=1e-10)

# 同一份 expo 再调一次，结果逐位相同
out2 = torch.empty_like(out)
aiter.random_sample_outer_exponential(out2, logits, expo, temps, eps=1e-10)
assert torch.equal(out, out2)
```

### 单独生成指数噪声

```python
noise = torch.empty(M, N, device=device, dtype=torch.float32)
aiter.exponential(noise)              # lambd=1.0
```

### 功能验证入口

在仓库根目录运行：

```bash
# 全量：3 组 sampler × 9 个 M，外加两个边界断言
python -B op_tests/test_sample.py

# 缩减规模
python -B op_tests/test_sample.py -n 4096 -m 1 8
```

覆盖 `test_greedy_sample` / `test_random_sample` / `test_mixed_sample` 各 9 个用例，另有两个在性能扫描之后执行的断言：

- **`check_vocab_edges`** —— 任意词表大小下，采出的 token id 必须落在 `[0, N)`。覆盖 15 个 `N`（含 4092、4095、4097、4099、16368、16383、16385、163841 等），针对两类曾经越界的形状：`N <= (BlockSize-1)*VecSize`（首元素越过 `N` 的线程跳过 prologue 后用未初始化寄存器跑 tail），以及 `N % VecSize != 0`（行尾向量不完整，outer-exponential 形态下噪声描述符恰好止于 `N`，补位读到的 0 落进除数而赢得 argmax）。
- **`check_exponential_row_bounds`** —— `exponential` 必须填满本行且不越写。同一类行尾不完整向量的问题在写侧的表现：输出描述符的 extent 按 dword 向上取整，2 字节 dtype 且 `N % VecSize != 0` 时最后一次 store 会多写一个元素。

这两个断言是真实越界缺陷的回归守卫，不要为缩短运行时间而跳过。

> **gfx946 上该测试跑不起来**：它用 `aiter.ops.triton.{softmax, topk}` 算参考值，而该环境的 triton 后端无法编译 kernel（编译器崩溃）。这是 triton 工具链的限制，与本算子无关 —— 本算子的 kernel 在 gfx946 上构建与运行均正常。该架构改用纯 torch 参考校验，见第 6 节。

## 4. 实现与架构范围

通用 HIP C++（[sample_kernels.cu](../csrc/kernels/sample_kernels.cu)），无架构特化分支、无 kernelId 参数，各架构走同一份 kernel。依赖 `rocprim`、`hiprand`（Philox）与 opus 的向量访存抽象。

数据流：每行一个 block（`block_size=1024`、`unroll=4`、`VecSize=4`）。先块内归约求行最大值，再在同一趟里算 softmax 分母与 `p/e` 的 argmax，用 `aiter::ArgMax` 对 `aiter::KeyValuePair<int, float>` 做 `block_reduce` 得到获胜下标。`mixed_sample*` 在块入口按该行温度分流到 argmax 或随机分支。

native 入口编入 `module_sample`，JIT 编译配置带 `-DCK_TILE_USE_BUFFER_ADDRESSING_BUILTIN=0`，额外包含路径 `csrc/include/ck_tile`。

### 实现要点：结构体归约

`aiter::ArgMax` 归约的是 `KeyValuePair<int, float>`（下标 + 值）而不是标量，这要求 `hip_reduce.h` 的 `block_reduce` 对 `T` 完全泛型。该文件原先把跨 wave 暂存缓冲写死为 `__shared__ float smem[waves]`，归约非 float 类型时无法编译；本次改为 `__shared__ T smem[waves]`。

全部在树调用点此前均为 `T=float`，对它们而言改动字节等价；同时消除了「归约非 float 类型时静默经 float 窄化」这一隐患。`aiter::{KeyValuePair, Max, Min, Sum, ArgMax, ArgMin}` 一并补入该头文件。

`ArgMax` / `ArgMin` 在值相等时取**更小的 key**，因此获胜者与 lane 的归约合并次序无关；`Max` / `Min` 用 `(u > t) ? u : t`，恰有一个操作数为 NaN 时比较为假、`t` 存活，故 NaN 输入下结果依赖操作数次序。

## 5. 性能报告

测试日期 2026-11-06。基准（表中 `origin`）为 **triton 参考路径**，即 `softmax` + `topk` 的组合，也是该测试文件自带的对照实现。`N = 151936`（Llama-3 量级词表），BF16 logits。

### 测试环境

| 项目 | gfx936 | gfx938 |
|---|---|---|
| 产品型号 | BW1000 64G | BW1100 |
| 计算单元（CU）数 | 80 | 64 |
| 可见显存 | 65520 MiB | 147440 MiB |
| PyTorch / `torch.version.hip` | 2.11.0 / 6.3.26113 | 2.11.0 / 7.2.26365 |
| AITER 编译 | JIT，DTK 26.04（clang 18） | JIT，DTK 26.10（clang 22） |

计时由测试文件的 `run_perftest` 采集，单位 µs；JIT 编译与预热不计入。

### greedy_sample

| `M` | gfx936 origin | gfx936 aiter | gfx938 origin | gfx938 aiter |
|---:|---:|---:|---:|---:|
| 1 | 13.80 | 21.48 | 15.26 | 21.50 |
| 8 | 21.53 | 21.54 | 24.70 | 22.67 |
| 16 | 30.81 | 22.54 | 32.90 | 24.34 |
| 32 | 51.60 | 24.39 | 53.06 | 25.93 |
| 64 | 91.97 | 27.87 | 92.75 | 29.09 |
| 128 | 178.70 | 49.01 | 168.01 | 45.00 |
| 192 | 265.90 | 63.36 | 253.23 | 61.21 |
| 256 | 353.64 | 83.98 | 334.09 | 77.28 |
| 512 | 706.43 | 149.52 | 637.44 | 142.31 |

### random_sample

`exp_out` 为外部噪声形态，`exp_in` 为内部 RNG 形态。

| `M` | gfx936 origin | gfx936 exp_out | gfx936 exp_in | gfx938 origin | gfx938 exp_out | gfx938 exp_in |
|---:|---:|---:|---:|---:|---:|---:|
| 1 | 133.27 | 114.81 | 146.03 | 134.39 | 116.08 | 144.48 |
| 8 | 178.94 | 124.11 | 146.04 | 175.39 | 126.73 | 144.44 |
| 16 | 231.34 | 133.58 | 146.28 | 228.06 | 141.31 | 145.11 |
| 32 | 332.92 | 155.57 | 147.76 | 307.30 | 169.90 | 147.28 |
| 64 | 470.22 | 199.18 | 150.44 | 436.26 | 229.97 | 155.18 |
| 128 | 864.52 | 362.83 | 278.83 | 790.95 | 418.70 | 282.76 |
| 192 | 1293.05 | 523.64 | 406.17 | 1137.48 | 604.35 | 412.97 |
| 256 | 1746.81 | 684.65 | 534.65 | 1487.05 | 794.63 | 543.72 |
| 512 | 3314.25 | 1249.08 | 921.55 | 2907.32 | 1548.69 | 1068.29 |

### mixed_sample

| `M` | gfx936 origin | gfx936 exp_out | gfx936 exp_in | gfx938 origin | gfx938 exp_out | gfx938 exp_in |
|---:|---:|---:|---:|---:|---:|---:|
| 1 | 169.87 | 114.55 | 147.51 | 164.60 | 117.40 | 145.79 |
| 8 | 232.38 | 124.51 | 147.54 | 240.66 | 127.82 | 145.66 |
| 16 | 303.72 | 133.53 | 148.15 | 325.55 | 142.56 | 146.29 |
| 32 | 447.91 | 155.18 | 149.69 | 477.00 | 170.88 | 147.47 |
| 64 | 665.16 | 198.41 | 152.20 | 730.84 | 225.28 | 151.00 |
| 128 | 1219.64 | 362.88 | 282.09 | 1350.28 | 414.20 | 281.82 |
| 192 | 1806.52 | 527.11 | 406.62 | 1964.76 | 622.51 | 415.81 |
| 256 | 2417.47 | 626.01 | 428.42 | 2590.57 | 793.04 | 544.01 |
| 512 | 3597.05 | 1183.74 | 809.81 | 3087.46 | 1503.62 | 965.90 |

### 结果分析

- **`greedy_sample` 在 `M >= 16` 后优势随 `M` 扩大**，`M=512` 时两架构分别为 4.7x / 4.5x；`M=1` 反而慢约 40%~56%，该形态下启动与同步开销占主导。
- **`random_sample` / `mixed_sample` 全矩阵领先**。内部 RNG 形态（`exp_in`）在 `M >= 32` 后稳定快于外部噪声形态（`exp_out`），因为省掉了 `M*N` 的噪声张量写入与读回；`M <= 16` 时 `exp_out` 更快（噪声张量小，而内部 RNG 的固定开销占比高）。选择建议：小 batch 用 `*_outer_exponential`，大 batch 用内部 RNG 形态；需要逐位复现时一律用 `*_outer_exponential`。
- **适用范围**：结论限定于上列设备、软件版本、`N = 151936`、BF16 输入与所列 `M`。基准是该测试自带的 triton 参考路径，不是生产实现，这些倍数不应理解为端到端收益。未测 FP32 / FP16 的性能矩阵、未测其他词表宽度。

## 6. 验证记录

| 架构 | 正确性 | 备注 |
|---|---|---|
| gfx936 | **PASS，0 失败** | `op_tests/test_sample.py` 全量：3 组 sampler × 9 个用例 + 2 个边界断言 |
| gfx938 | **PASS，0 失败** | 同上，两架构覆盖一致 |
| gfx946 | **9 / 9 PASS** | 该环境 triton 不可用（见第 3 节），改用纯 torch 参考校验；两个 XCD 各 108 次 dispatch，负载均分 |

`greedy_sample` 对照 triton `topk` 时存在 1%~3% 的下标差异（在 `checkAllclose` 默认容差比例内判定通过）：这是 logits 出现并列或接近并列时两种实现的 tie-break 取法不同，不是数值错误。需要与特定参考实现逐位一致时，应自行约定 tie-break 规则。

gfx946 的校验脚本比对的是 `greedy_sample`、`random_sample_outer_exponential`、`mixed_sample_outer_exponential`（给定固定噪声后均为纯函数，可做逐元素比对），以及 `random_sample` / `mixed_sample` 的 token id 落域检查和 `exponential` 的有限性与正数性检查。该脚本先在 gfx938 上自检 9/9 通过，确认脚本本身可信后才用于 gfx946。

gfx946 为 perf model 环境，按规划只验功能与多 die，不验性能（该环境无法获得 kernel 计时）。

同时在 gfx936 / gfx938 上跑了 11 个既有算子测试做回归，无回归项。

## 7. 版本与数据追溯

| 项目 | 标识 |
|---|---|
| 源码基线 | commit `a620f2a05966c4009932af32914dec6296d83746` |
| 功能验证 | 2026-11-06，gfx936 / gfx938 全量 PASS，gfx946 9/9 PASS |
| 性能数据采集 | 2026-11-06，BW1000 64G / gfx936 与 BW1100 / gfx938 |

- [Python 公开接口与 Philox 状态处理](../aiter/ops/sample.py)
- [native kernel 实现](../csrc/kernels/sample_kernels.cu)
- [native 入口声明](../csrc/include/sample.h)、[pybind 模块](../csrc/pybind/sample_pybind.cu)
- [结构体归约与 functor](../csrc/include/hip_reduce.h)
- [功能测试](../op_tests/test_sample.py)
- [JIT 编译配置（module_sample）](../aiter/jit/optCompilerConfig.json)
