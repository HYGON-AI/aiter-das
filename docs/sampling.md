<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# sampling 算子说明与性能报告

`aiter.ops.sampling` 提供从概率分布中逐行采样 token 的三个接口：`top_k_sampling_from_probs`、`top_p_sampling_from_probs` 与 `top_k_top_p_sampling_from_probs`，位于推理流程中 softmax 之后、取 token 之前的采样阶段。输入已经是归一化概率（不是 logits），每个请求（每行）输出一个按概率加权采样的 token id，并保证样本落在 top-k / top-p 截断集合内。

## 算子功能

对每一行概率独立采样：以当前阈值 `low` 划定候选集，在候选集内做逆 CDF 采样；若采出的 token 不满足 top-k / top-p 约束，则二分收紧阈值并重复。对每行：

| 符号 | 含义 |
|---|---|
| `B` | 输出行数（`indices` 提供时为 `indices` 长度，否则为 `probs` 行数） |
| `V` | 词表大小，即 `probs` 的列数 |
| `row` | 输出行 `b` 实际读取的 probs 行：`indices[b]`，无 `indices` 时为 `b` |
| `k` | top-k 截断值，逐行可为不同值；`k >= V` 表示关闭 top-k 过滤 |
| `p` | top-p 截断值，逐行可为不同值；`p >= 1.0` 表示关闭 top-p 过滤 |
| `q` | 当前候选集的概率质量，首轮为 1 |

```text
候选集 S(low) = { j : probs[row, j] > low, 0 <= j < V }
u = uniform(0,1] * q                          # 首轮 low = 0、q = 1
sampled = min { j : cumsum_{i <= j, i ∈ S} probs[row, i] > u }
          若上式无解 → sampled = max(S)        # u 达到候选集总质量时的回退

top-k 收敛： |{ j : probs[row, j] > probs[row, sampled] }| < k
top-p 收敛： sum{ probs[row, j] : probs[row, j] > probs[row, sampled] } < p
joint 收敛： 上述两式同时成立
未收敛时二分收紧 low 并更新 q，重复以上过程

输出：output[b] = sampled，形状 [B]，类型 int32
```

**边界语义**：

- `k = 1`（或 `p` 趋近 0）退化为精确 argmax；概率并列时取并列最大值中的一个。
- `k >= V` 或 `p >= 1.0` 关闭对应过滤，等价于对整行做多项分布采样；逐行 tensor 中可以混合启用与关闭的行。
- 截断按**概率值**进行：与第 `k` 大（或 p 边界）概率并列的 token 全部保留，因此实际保留个数可能多于 `k`。
- 回退分支（`u` 不小于候选集总质量，如 `u` 恰为 `1.0 * q`）取候选集中最后一个有效位置，不会采到候选集外的 token。
- 概率为 0 的 token 不会被采出（功能测试含两值分布与 100/4096 支撑集两组验证）。

**负向范围**：

- 本接口不执行 softmax，输入必须是概率而不是 logits。
- 每行只采样一个 token，不做 batch 次重复采样、去重或 TopK 列表输出。
- 接口不归一化输入：**未归一化的概率行不报错，但采样分布不保证正比于 probs**，调用方需保证输入为 softmax 的输出。
- 无 `out` 参数、无 autograd，仅供推理使用。
- joint 接口只支持 `filter_apply_order="joint"`（k、p 同时作用于原始概率，样本须同时落在两个截断集内）；不支持先 top-k 再对剩余概率 top-p 的串行顺序。
- **probs 每行必须至少存在一个正的有限概率**：全零或全 NaN 行会读取未初始化的共享内存，行为未定义。
- 非 2-D 的 `probs`、`k < 1`、`p <= 0`、`indices` 非 int32 或越界等不做检查，行为未定义。

## 接口与参数

```python
from aiter.ops.sampling import (
    top_k_sampling_from_probs,
    top_p_sampling_from_probs,
    top_k_top_p_sampling_from_probs,
)

sampled = top_k_sampling_from_probs(
    probs, top_k, indices=None, deterministic=True,
    generator=None, check_nan=False, seed=None, offset=None,
)

sampled = top_p_sampling_from_probs(
    probs, top_p, indices=None, deterministic=True,
    generator=None, check_nan=False, seed=None, offset=None,
)

sampled = top_k_top_p_sampling_from_probs(
    probs, top_k, top_p, indices=None, filter_apply_order="joint",
    deterministic=True, generator=None, check_nan=False,
    seed=None, offset=None,
)
```

`indices` 及之后的所有参数均为仅限关键字参数。

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `probs` | `torch.Tensor [rows, V]`，FP32 / FP16 / BF16 | 已归一化概率；接口内部统一 `.float().contiguous()`（FP32 连续输入零拷贝）；须为 2-D、非负、每行至少一个正概率；元素总数须 `< 2**32`（kernel 按 32 位寻址） |
| `top_k` | Python `int` 或 `torch.Tensor` | 逐行 k 用 int tensor（接口转 int32 + contiguous）；标量或逐行值 `>= 1`；`>= V` 关闭过滤。**索引方式见下方检查边界** |
| `top_p` | Python `float` 或 `torch.Tensor` | 逐行 p 用 FP32 tensor（接口转 float32 + contiguous）；`> 0`；`>= 1.0` 关闭过滤；逐行数组按 probs 行号索引 |
| `indices` | 可选 `torch.int32 [B]` | 输出第 `b` 行从 `probs[indices[b]]` 采样；输出 dtype 与之保持一致，而 kernel 按 int32 写出，**因此必须是 int32**；`B` 即输出行数 |
| `filter_apply_order` | Python `str`，默认 `"joint"` | 仅支持 `"joint"`，其余值抛 `NotImplementedError` |
| `deterministic` | Python `bool`，默认 `True` | `True` 使用固定结合序的扫描，相同输入 + 相同 `(seed, offset)` 逐位可复现；`False` 使用 hipCUB BlockScan，浮点结合序不同，个别样本可能在边界上不同，统计分布一致 |
| `generator` | 可选 `torch.Generator` | GPU generator；缺省用该 device 的 default generator |
| `check_nan` | Python `bool`，默认 `False` | `True` 时检测 NaN 并抛 `ValueError`；引入一次 GPU→CPU 同步，**不应放入热路径** |
| `seed` / `offset` | 可选 Python `int` | 两者都提供时直接使用且不读、不推进 generator；任一缺省则从 generator 读取 `(seed, offset)` 并推进（见下节） |
| 返回值 | `torch.int32 [B]` | 提供 `indices` 时 dtype 与 `indices` 一致 |

所有输入张量须位于同一 GPU 且不需要梯度。接口用于推理，不提供 autograd，也没有 `out` 参数。

**检查边界**：接口检查的只有 `filter_apply_order` 取值、`check_nan`（显式开启时）与 NaN；其余元数据依赖 torch 的 dtype 转换。为避免热路径开销，接口不检查 `probs` 的维度、非负性、归一化与元素总数，不检查 `k` / `p` 取值范围，也不检查 `indices` 的 dtype、长度与取值范围——上述约束由调用方保证。

**逐行数组与 `indices` 的索引对应关系**（以代码为准，容易踩坑）：

- 纯 top-k kernel 按**输出行号**读取 k 数组：第 `bx` 个输出使用 `top_k_arr[bx]`。
- top-p 与 joint kernel 按 **probs 行号**读取数组：使用 `top_p_arr[row_idx]` / `top_k_arr[row_idx]`，其中 `row_idx = indices[bx]`。
- `indices=None` 时两种索引方式一致。**同时使用 `indices` 与逐行 k 数组时，纯 top-k 与另外两个接口的数组语义不同**，务必按上表区分；功能测试中 `indices` 仅与逐行 p 数组（按 probs 行号）组合验证过。

### 随机数与确定性

- kernel 使用 hipRAND 的 Philox4_32_10：`hiprand_init(seed, subsequence=行号, offset)`，每个输出行使用独立子序列，行间互不重叠。
- 未显式提供 `(seed, offset)` 时，每次调用从 generator 读取状态并把 offset 推进 `(B * 32 + 3) // 4 * 4`（即 `B * 32`，4 对齐），因此连续调用默认产生不同样本；显式提供时 generator 状态不变。
- 功能测试验证：相同 `(seed, offset)` 输出逐位相同；offset 推进 `B*32` 或换 seed 后输出不同；default generator 连续调用持续推进。
- `deterministic=True` 的逐位可复现以相同 `(seed, offset)` 为前提；两个条件同时满足时跨运行可复现，用于结果核对与回归对比。

## 使用方式

### 标量与逐行参数的常规调用

```python
import torch
from aiter.ops.sampling import top_k_sampling_from_probs

device = torch.device("cuda:0")
B, V = 8, 4096
probs = torch.rand(B, V, device=device).softmax(dim=-1, dtype=torch.float32)

# 标量 k：所有行使用同一个 top_k
sampled = top_k_sampling_from_probs(probs, 32, deterministic=True)
assert sampled.shape == (B,)
assert sampled.dtype == torch.int32

# 逐行 k：每行独立的截断值
k = torch.randint(1, 64, (B,), device=device, dtype=torch.int32)
sampled = top_k_sampling_from_probs(probs, k, deterministic=True)

# 用 torch 参考实现核对样本命中集合：按值截断保留前 k 个（并列全保留）
kth = probs.topk(int(k.max()), dim=1).values.gather(1, (k - 1).long().unsqueeze(1))
allowed = probs >= kth
assert allowed.gather(1, sampled.long().unsqueeze(1)).all().item()
```

上例的断言与 `.item()` 仅用于正确性展示，不应纳入热路径计时。top-p 与 joint 接口把 `k` 换成 `p`（标量 `0.9` 或逐行 FP32 tensor）即可；关闭过滤用 `k=V` 或 `p=1.0`（逐行 tensor 中可逐行混用）。

### 用 indices 从部分行采样

```python
import torch
from aiter.ops.sampling import top_p_sampling_from_probs

device = torch.device("cuda:0")
rows, B, V = 64, 32, 4096
probs = torch.rand(rows, V, device=device).softmax(dim=-1, dtype=torch.float32)
idx = torch.randint(0, rows, (B,), device=device, dtype=torch.int32)

# 输出第 b 行采样自 probs[idx[b]]；逐行 p 数组按 probs 行号提供
p = torch.rand(rows, device=device, dtype=torch.float32) * 0.4 + 0.5
sampled = top_p_sampling_from_probs(probs, p, indices=idx, deterministic=True)
assert sampled.shape == (B,) and sampled.dtype == torch.int32
```

### 固定 seed / offset 复现实验

```python
a = top_k_sampling_from_probs(probs, 32, deterministic=True, seed=42, offset=0)
b = top_k_sampling_from_probs(probs, 32, deterministic=True, seed=42, offset=0)
assert torch.equal(a, b)
```

显式 `(seed, offset)` 不读取也不推进 generator；并行跑多次实验时可用不同 offset（如 `i * B * 32`）划分互不重叠的随机流。

### Graph 捕获

```python
def run():
    return top_k_sampling_from_probs(
        probs, 32, deterministic=True, seed=42, offset=0
    )

run()  # 首次 JIT 必须在捕获之外完成
warm_stream = torch.cuda.Stream()
warm_stream.wait_stream(torch.cuda.current_stream())
with torch.cuda.stream(warm_stream):
    for _ in range(3):
        run()
torch.cuda.current_stream().wait_stream(warm_stream)
graph = torch.cuda.CUDAGraph()
with torch.cuda.graph(graph):
    captured_out = run()
graph.replay()
torch.cuda.synchronize()
```

捕获要求固定 shape 与地址；输入可原地 `copy_` 更新，但更新与回放须遵守 stream 顺序，且更新内容仍满足概率与截断值约束。**回放不会重新执行 Python 代码，捕获时固化的 seed/offset 在每次回放中重复使用，因此多次 replay 得到相同的采样序列**；同理，默认 generator 路径的读取与推进只发生在捕获时刻。需要每次回放刷新随机性时，应保持 eager 调用或重新捕获，而不是依赖 generator 前进。

### 功能验证与基准入口

在 AITER 仓库根目录运行现有测试文件：

```bash
# 全部 11 组用例
python -B op_tests/test_sampling.py

# 快速子集（跳过统计分布检验）
python -B op_tests/test_sampling.py --quick

# 指定用例与规模
python -B op_tests/test_sampling.py --ops top_k joint rng --batch 128 --vocab 131072
```

覆盖内容：三接口对 torch 参考截断集的命中验证、标量参数、`k=1` 精确 argmax、极小 shape / 关闭过滤 / 零概率支撑集、逐行异构 k/p、`indices` 行收集、FP16/BF16 与非连续输入、`check_nan` 拒绝、seed/offset 确定性与 generator 推进、与 `torch.multinomial` 的分布一致性（TV 距离）。2026-09-23 在 commit `08b66ee4` 上 11/11 全部通过。

## 实现与架构范围

实现为通用 HIP C++（`csrc/kernels/sampling.cu`），基于 hipCUB 的 BlockReduce / BlockScan / BlockAdjacentDifference 与 hipRAND；无架构特化分支、无 kernelId 参数，HCU 各架构走同一份 kernel。wave size 按 64 处理（`HCU_WARP_SIZE`）。

数据流与并行粒度：

- 每个输出行一个 block；`batch < 64` 时用 1024 线程的宽 block（小 grid 下用宽 block 隐藏每 chunk 的同步延迟），否则 512 线程。加载按 `VEC_SIZE=4` 的 float4 向量化，chunk 循环 `#pragma unroll 4`。
- 每轮先做候选采样：块内对 `prob > low` 的概率做归约与（deterministic 时的固定序）前缀和，累加质量一旦越过 `u` 提前结束行扫描，用 BlockAdjacentDifference 找到首个越限位置并以 `atomicMin` 汇总为 `sampled_id`；无越限时回退到块内最后一个满足 `prob > low` 的位置。
- 收敛判定每轮同时统计两个阈值（`pivot_0` 与中点 `pivot_1`）的质量与个数（`ValueCount` 归约，一次遍历出两组统计），未收敛时二分收紧 `[low, high]` 并把 `q` 更新为候选集质量。
- 第一轮顺带用每 wave 一次的 `atomicMax` 记录行最大值，把二分上界从 1.0 收紧到行最大值；仅当该轮完成整行扫描时采用，避免提前 break 情况下用前缀最大值错误塌缩区间。
- `deterministic=True` 走手写的固定结合序 inclusive scan（warp shuffle 前缀 + 跨 warp 前缀，结合顺序固定）；`False` 走 hipCUB `BlockScan::InclusiveSum`。
- 行内 uniform 标量（`k`、`p`、`u`、行号等）经 `readfirstlane` 从 VGPR 移入 SGPR，调用方保证这些值在同一 wave 内一致（kernel 设计如此）。

首次调用经 `aiter/jit` 的 `module_sampling` JIT 编译（源文件见尾节链接），本容器 DTK 26.04 环境首次构建约 56 s，构建完成后复用。仓库 `aiter_meta/csrc` 下存在同名 sampling 源文件，为使用旧版 hipCUB 接口（`FlagHeads`）的历史副本，当前生效实现以 `csrc/` 与 `aiter/ops/sampling.py` 为准。

## 性能报告（BW1100 / gfx938）

测试日期 2026-09-23，**original** 表示优化前的 AITER 实现，**optimized** 表示优化后的实现。

### 测试环境与计时口径

| 项目 | gfx938 |
|---|---|
| 设备 / 产品型号 | GPU0，BW1100 |
| 计算单元（CU）数 | 64 |
| 可见显存 | 147440 MiB |
| 测试日期 | 2026-09-23 |
| 软件 | PyTorch 2.10.0，`torch.version.hip` 6.3.26113 |
| AITER 编译 | JIT：AICC clang 18.0.0（`/opt/dtk`），默认选项 |
| 输入 | FP32 概率（softmax 后）、int32 top-k、FP32 top-p |
| 调用方式 | 公开 API，`deterministic=True`，默认 generator |
| 计时 | 同卡同进程，逐调用 CUDA events；7 轮 A→B / B→A 交替 |

- 计时对象为**公开 API 的 eager 调用**；两种实现使用完全相同的输入张量与默认 generator，逐次调用推进 generator 偏移，与真实推理的调用形态一致。
- 报告口径：每轮取**轮内中位数**作为轮样本，表中微秒数为 7 轮样本的中位数；4 个波动超标的 case 延长为 15 轮整项复测后替换（`top_p` 的 B1/B32 V32768 与 B1 V128256、`top_k_top_p` 的 B1 V32768）。
- 该测试机存在间歇性主机调度停顿（单次可达数百毫秒，会落进个别逐调用样本）。因此计时全程禁用 Python GC，每个 case 计时前执行 2000 ms GPU 预热，并采用轮内中位数而非均值以排除停顿污染；前两遍以均值口径采集的数据整批废弃，未用于本文任何数字。
- eager 时间包含调用内的主机工作（generator 状态读取与推进、输出分配、kernel 发射）及 GPU 时间线上等待主机发射的空隙；它不是 CPU 墙钟，也不是纯 kernel 时间。两种实现的口径完全相同。
- p99 列为各轮 p99 的中位数，同样受上述主机尾部影响，仅用于同口径下的 A/B 相对比较。
- JIT 编译、输入生成与预热不计入样本；没有在 API 外预先替任一实现完成其内部必要的数据处理。

### Shape 与输入构造

- 8 个 shape：`B ∈ {1, 8, 32, 128, 256}` 固定 `V=32768`，加 `B ∈ {1, 32, 256}` 固定 `V=128256`；对三个接口各测一遍，共 24 个 case。`V=128256` 对应 Llama-3 量级词表；均为合成 shape，不是线上请求回放。
- 输入构造与 bench 文件的 `build_inputs` 一致（seed=42）：`probs = rand(B,V).softmax(-1)` 为 FP32 连续张量；top-k 逐行 `randint(1, min(1000, V))`，其中 50% 行置 `k=V` 关闭过滤；top-p 逐行 `rand*0.5+0.5`，其中 50% 行置 `p=1.0` 关闭过滤。即每个 case 约一半行启用过滤、一半行关闭，k / p 逐行异构。
- 每次调用经默认 generator 取新随机数，输出为随机样本；同一 case 内两种实现消费同一份 `probs / k / p`。
- 未纳入性能矩阵的场景：`indices` 行收集、FP16 / BF16 输入、`check_nan=True`、显式 `(seed, offset)`、Graph 回放、`deterministic=False`。这些功能由测试文件覆盖，但性能不能由本文推导。

### 总览

| 接口 | case 数 | 快/平/慢 | 几何平均加速比 | 提升 | 单项加速比范围 |
|---|---:|---:|---:|---:|---:|
| `top_k_sampling_from_probs` | 8 | 8/0/0 | 1.8055x | +80.55% | 1.555x – 2.378x |
| `top_p_sampling_from_probs` | 8 | 5/1/2 | 1.2563x | +25.63% | 0.775x – 2.490x |
| `top_k_top_p_sampling_from_probs` | 8 | 8/0/0 | 1.7480x | +74.80% | 1.411x – 2.395x |
| 全部 | 24 | 21/1/2 | 1.5828x | +58.28% | 0.775x – 2.490x |

最大保留 CV：top_k **4.971%**，top_p **19.564%**（见下方持平项说明），top_k_top_p **5.132%**。p99 在全部 24 个 case 中 AITER 均低于 original。

唯一持平项为 `top_p_sampling_from_probs` 的 `B=32、V=32768`（加速比 0.985）。该 case 在延长复测中 AITER 的轮中位数在约 72 µs 与 120 µs 两个模式间波动——采样二分的收敛轮数随逐调用随机数变化，各模式的占比在轮间漂移；15 轮中位数 `118.080 µs` 与 original 的 `116.320 µs` 落在 ±2% 持平区间内，按规则记为持平。该 case 的四次独立测量（三次 7 轮 + 一次 15 轮）加速比分别为 1.008 / 1.008 / 0.972 / 0.985，一致地贴在 1.0 附近。

### 逐 shape 结果

提升列按各表中位数（未舍入值）计算；p99 为各轮 p99 的中位数。

#### 1. top_k_sampling_from_probs

| `B` | `V` | AITER eager (µs) | original eager (µs) | eager 提升 | AITER p99 (µs) | original p99 (µs) |
|---:|---:|---:|---:|---:|---:|---:|
| 1 | 32768 | 120.320 | 191.359 | +59.04% | 255.039 | 421.440 |
| 8 | 32768 | 193.284 | 352.479 | +82.36% | 325.920 | 653.920 |
| 32 | 32768 | 216.640 | 395.680 | +82.64% | 342.240 | 634.400 |
| 128 | 32768 | 331.840 | 526.879 | +58.78% | 446.079 | 711.359 |
| 256 | 32768 | 418.560 | 650.880 | +55.50% | 562.560 | 913.919 |
| 1 | 128256 | 345.599 | 795.040 | +130.05% | 723.199 | 1665.919 |
| 32 | 128256 | 732.320 | 1741.279 | +137.78% | 1060.799 | 2500.637 |
| 256 | 128256 | 1507.519 | 2379.518 | +57.84% | 1857.759 | 3065.118 |

#### 2. top_p_sampling_from_probs

| `B` | `V` | AITER eager (µs) | original eager (µs) | eager 提升 | AITER p99 (µs) | original p99 (µs) |
|---:|---:|---:|---:|---:|---:|---:|
| 1 | 32768 | 110.240 | 98.080 | -11.03% | 122.720 | 134.880 |
| 8 | 32768 | 118.880 | 92.160 | -22.48% | 179.200 | 191.680 |
| 32 | 32768 | 118.080 | 116.320 | -1.49% | 178.720 | 205.120 |
| 128 | 32768 | 118.560 | 157.600 | +32.93% | 183.200 | 241.760 |
| 256 | 32768 | 129.600 | 187.519 | +44.69% | 203.360 | 263.200 |
| 1 | 128256 | 120.800 | 148.320 | +22.78% | 167.840 | 237.599 |
| 32 | 128256 | 167.040 | 415.998 | +149.04% | 291.839 | 695.359 |
| 256 | 128256 | 395.679 | 614.560 | +55.32% | 552.959 | 911.039 |

#### 3. top_k_top_p_sampling_from_probs

| `B` | `V` | AITER eager (µs) | original eager (µs) | eager 提升 | AITER p99 (µs) | original p99 (µs) |
|---:|---:|---:|---:|---:|---:|---:|
| 1 | 32768 | 125.760 | 177.440 | +41.09% | 265.280 | 378.720 |
| 8 | 32768 | 198.560 | 359.040 | +80.82% | 339.200 | 612.000 |
| 32 | 32768 | 219.040 | 396.160 | +80.86% | 322.080 | 605.759 |
| 128 | 32768 | 336.640 | 515.199 | +53.04% | 458.559 | 721.119 |
| 256 | 32768 | 423.840 | 638.879 | +50.74% | 558.240 | 905.119 |
| 1 | 128256 | 358.559 | 776.800 | +116.64% | 680.159 | 1559.358 |
| 32 | 128256 | 726.719 | 1740.638 | +139.52% | 987.519 | 2412.158 |
| 256 | 128256 | 1508.959 | 2381.438 | +57.82% | 3180.477 | 20513.100 |

### 结果分析

- **top-k 与 joint 全矩阵领先**：几何平均分别为 1.8055x 与 1.7480x，最大单项为 `top_p B=32、V=128256` 的 2.490x，top-k / joint 在同 shape 也达到 2.378x / 2.395x。`V=128256` 宽词表 shape 的收益整体大于 `V=32768`（行扫描与二分成本占比更高），与实现中「累加质量越限提前结束扫描、单次遍历同时统计两个收敛阈值」等改动方向一致；本文数据不能拆分出每项技术各自的贡献。
- **top-p 是唯一有落败项的接口**：小 batch（B=1、B=8）且 `V=32768` 时 AITER 分别慢 11.0% 与 22.5%，而同 shape 的 top-k 与 joint 均领先 41%–59%，落败集中在纯 top-p 路径的小 launch 形态。AITER 与 original 的 top-p kernel 是不同实现，本文数据不足以把差距归因到单一因素；以纯 top-p、小 batch 为主的使用方建议按自身 shape 实测后取舍。
- **p99 尾部一致占优**：24/24 个 case 中 AITER 的 p99 低于 original，宽词表下差距最大（如 `top_k B=32、V=128256`：1060.799 µs 对 2500.637 µs）。p99 含主机调度尾部，绝对值应结合口径节理解；两列同口径，方向可信。
- **适用范围**：结果限定于所列设备（BW1100 / gfx938）、软件版本（PyTorch 2.10.0 + `torch.version.hip` 6.3.26113；AITER JIT AICC clang 18.0.0）、输入分布（均匀 softmax、约半数行关闭过滤）与上列 shape。未测 vLLM 等端到端吞吐、`deterministic=False`、Graph 回放、FP16/BF16 输入与 `indices` 路径；采样时延与随机数路径相关，其他分布（如尖锐 logits）下的时延不能由本文推导。本文为设备级算子计时，不代表模型端到端加速。

## 版本与数据追溯

| 项目 | 标识 |
|---|---|
| 源码版本（本文整理、功能验证与 AITER 性能侧基准） | commit `08b66ee4cd1403fb7160e659bba14193f779d58e` |
| 功能验证 | 2026-09-23，`op_tests/test_sampling.py` 11/11 PASS（PyTorch 2.10.0 / HIP 6.3.26113 / BW1100 / DTK 26.04） |
| 性能数据采集 | 2026-09-23，BW1100 / gfx938，单卡 GPU0 |

- [Python 公开接口与参数处理](../aiter/ops/sampling.py)
- [native kernel 实现](../csrc/kernels/sampling.cu)
- [native 入口声明与 pybind](../csrc/include/sampling.h)、[pybind 模块](../csrc/pybind/sampling_pybind.cu)
- [功能测试](../op_tests/test_sampling.py)
- [JIT 编译配置（module_sampling）](../aiter/jit/optCompilerConfig.json)
