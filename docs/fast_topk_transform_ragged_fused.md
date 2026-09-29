<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fast_topk_transform_ragged_fused 算子说明与性能报告

本接口融合每行 TopK 选择与 ragged KV 全局索引转换，适用于稀疏注意力 prefill / extend 阶段。分页 KV 对应接口另见 [fast_topk_transform_fused](fast_topk_transform_fused.md)。

## 算子功能

记 `Q` 为 Query 行数、`W` 为 score 列数，`K=2048`。第 r 行从半开区间 `[start_r,start_r+lengths[r])` 选取分数最大的 `min(lengths[r],K)` 个位置，再输出 ragged KV 地址：

```text
start_r = 0 if row_starts is None else row_starts[r]
j ∈ [0, lengths[r])                 # 有效区间内的相对位置
候选分数 = score[r, start_r + j]
返回索引 = topk_indices_offset[r] + j
```

输出为 int32 `[Q,2048]`，不足 K 的剩余槽位填 `-1`；空行全部为 `-1`。`length<=K` 时直接生成全部有效索引，无需读取分数。输出不保证按分数或索引排序，同分时允许选取不同的合法位置，不承诺稳定顺序；返回索引不包含 `row_starts`。

`row_starts` 描述 score 中分数的起点，`topk_indices_offset` 描述真实 ragged KV 拼接后的起点，两者不能相互替代。多个 Query 可共享同一个 KV offset。本接口不计算 logits、softmax，也不读取或搬运 KV 数据。

## 接口与参数

```python
from aiter.ops.topk_transform import fast_topk_transform_ragged_fused

indices = fast_topk_transform_ragged_fused(
    score, lengths, topk_indices_offset, topk, row_starts=None,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `score` | FP32 Tensor `[Q,W]` | 每行候选分数，列步长必须为 1；允许非连续行步长 |
| `lengths` | int32 Tensor `[Q]` | 每行参与选择的有效长度，连续存储 |
| `topk_indices_offset` | int32 Tensor `[Q]` | 每行 KV 序列的全局起点，连续存储；须保证加上有效局部索引后仍在 int32 范围内 |
| `topk` | Python `int` | 当前固定为 2048，不提供任意 K 的实现 |
| `row_starts` | 可选 int32 Tensor `[Q]`，默认 `None` | 每行 score 有效区间起点，应连续存储；None 表示全部从第 0 列开始，长行也可使用 None |
| 返回值 | int32 Tensor `[Q,2048]` | 新分配的全局 KV 索引；无效槽位为 -1 |

所有张量须在同一 GPU。调用方保证 `0<=start_r`、`0<=lengths[r]`、`start_r+lengths[r]<=W`，以及非负且有效的 KV 地址。建议输入有效区间为有限 FP32 分数；不依赖 NaN 与普通分数之间的业务排序语义。接口只执行部分元数据检查，不在热路径把 GPU 上的长度和 offset 拷回 CPU 做完整数值校验。

这是推理接口，不提供反向计算。公开函数会分配输出，**没有 `out` 参数**；内部的 `fast_topk_transform_ragged_interface` 是写入已分配输出的 native 入口，不能混淆两个签名。

## 使用方式

### Ragged KV 索引转换

```python
import torch
from aiter.ops.topk_transform import fast_topk_transform_ragged_fused

device = "cuda:0"  # HCU/ROCm 也使用 PyTorch 的 cuda 设备名
Q, W, K = 2, 8205, 2048
# 用递增分数方便核对；实际模型传入已计算好的 FP32 logits。
score = torch.arange(W, device=device, dtype=torch.float32).repeat(Q, 1)
lengths = torch.tensor([4096, 3000], device=device, dtype=torch.int32)
row_starts = torch.tensor([3, 4106], device=device, dtype=torch.int32)
# KV 拼接地址与 score 列起点不同，不能混用。
offsets = torch.tensor([0, 8192], device=device, dtype=torch.int32)

with torch.inference_mode():
    indices = fast_topk_transform_ragged_fused(
        score, lengths, offsets, K, row_starts=row_starts,
    )
assert indices.shape == (Q, K) and indices.dtype == torch.int32
for r in range(Q):
    expected = torch.arange(
        int(offsets[r]) + int(lengths[r]) - K,
        int(offsets[r]) + int(lengths[r]), device=device,
    )
    assert torch.equal(indices[r].sort().values, expected.to(torch.int32))
```

示例中的 `.sort()` 和断言仅用于展示正确性，不属于算子调用或性能路径。读取 GPU 标量的 `int(...)` 会同步，生产热路径无需执行这些检查。

### Graph 捕获

```python
# 接续上面的 ragged 示例，输入张量保持存活。
def run():
    return fast_topk_transform_ragged_fused(
        score, lengths, offsets, K, row_starts=row_starts,
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
    captured_indices = run()
graph.replay()
torch.cuda.synchronize()
assert captured_indices.shape == (Q, K)
```

Graph 捕获使用固定 shape 和固定地址的输入，更新输入内容时在相同张量上执行 `copy_`，并保持输入及 `captured_indices` 存活。捕获后 replay 将写回同一个捕获输出，消费输出需遵守 stream 依赖。公开接口在 eager 首次调用后缓存 native 入口，`torch.compile` 路径保留注册的自定义算子。

## 实现与适用范围

gfx936/gfx938 使用每行一个 block 的 HCU 直方图筛选：先以 FP16 粗分桶缩小候选，再按需使用 FP32 细分并排名，最终直接写出带 offset 的索引。小 Q（`Q<=32`）的中等候选桶（65–128 项）采用 wave 协作排名，其他情况保留 classic 排名。FP32 细分和溢出重置用于保证窄分布、混合分布及同分输入的完整性。

gfx946 等架构保留既有 fallback。架构与 shape 分发由内部实现决定，无需传入 kernelId。

## gfx936 / gfx938 性能报告

AITER 源码日期：**2026-09-18**。以下对比该日期 TopK 优化前后的实现：**original** 表示优化前的 AITER 实现，**optimized** 表示优化后的实现。

### 环境与计时口径

| 项目 | gfx936 | gfx938 |
| --- | --- | --- |
| 产品型号 | BW1000 | BW1101 |
| 计算单元（CU）数 | 80 | 64 |
| 测试卡 | GPU0 | GPU0 |
| 显存 | 65520 MiB | 147440 MiB |
| 软件 | PyTorch 2.10.0，HIP 6.3.26113 | PyTorch 2.10.0，HIP 6.3.26113 |

输入为 FP32，`K=2048`，索引及长度为 int32。两实现预热后在同进程、同卡交替计时，取多轮中位数；Graph 每次展开 20 个 kernel。加速比为 `original / optimized`，大于 1 表示优化版更快。

- **Graph**：预先分配输出，捕获 native 调用后计时 replay，折算为每次 kernel 的设备时间。
- **native eager**：每次分配输出并调用 native 入口，使用 GPU event 计时，可能包含主机提交间隙；**不包含公开 Python 包装层的完整分发开销，不是 CPU 墙钟耗时**。
- JIT、输入生成、CPU 参考计算、H2D/D2H 传输均不进入性能计时。两实现均在计时前及 Graph 重放后逐行精确校验；同分允许不同合法选择，不要求输出有序。
- ±2% 内的小幅波动视为基本持平，不解读为稳定收益；计时样本的变异系数（CV）均小于 5%。

### Shape 与输入构造

`Q` 为 Query 行数，`N` 为每个序列的最大 KV 长度，`S_cfg` 为测试配置的序列数。常规矩阵共 33 个配置：

1. `Q={1,32,128,512,2048,4096}` × `N={4096,16384,65536,131072}`，`S_cfg=1`，24 项。
2. `(Q,N,S_cfg)=(512,16384,2)`、`(Q,N,S_cfg)=(2048,65536,2)`，2 项。
3. `Q={2,8}` × `N={16384,131072}`，`S_cfg=1`，4 项。
4. `Q={1,32,512}`、`N=2048`、`S_cfg=1`，3 项。

ragged 模式按 `q_per_seq=Q/S_cfg` 构造递增有效长度：`max(0,N-q_per_seq+1+row%q_per_seq)`；`score` 逻辑宽度为 `N*S_cfg+3`，行存储再增加 13 列，`row_starts=owner*N+3`。因此表中的 N 不等于每行有效长度。

常规分数为固定种子的正态随机分布，offset 使用非零偏移。额外每种模式测试 8 项：宽存储短行 2 项（`Q∈{1,8},N=131072,length=2048`），窄分布、混合分布、全同分各 2 项（`Q∈{1,512},N=16384`）。窄分布为 `1+1e-5*randn`，混合分布额外将前 512 个有效分数置为 2，同分输入全部为 1。

下表给出常规矩阵汇总及代表性 shape 的性能对比。耗时单位均为 **μs**，数值保留三位小数；汇总用未舍入值计算。表中的 eager 均指上述 native eager 计时。

### 常规矩阵汇总

| 模式 | 架构 | 配置数 | Graph 几何平均加速 | Graph 最大加速 | native eager 几何平均加速 |
| --- | --- | ---: | ---: | ---: | ---: |
| ragged | gfx936 | 33 | 1.013× | 1.121× | 1.011× |
| ragged | gfx938 | 33 | 1.013× | 1.121× | 1.012× |

### ragged：gfx936 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 8.740 | 8.790 | 0.994× | 10.013 | 10.086 | 0.993× |
| 1 | 16384 | 1 | 16.204 | 14.590 | 1.111× | 17.488 | 15.894 | 1.100× |
| 1 | 131072 | 1 | 71.620 | 71.330 | 1.004× | 72.870 | 72.611 | 1.004× |
| 32 | 16384 | 1 | 18.135 | 16.176 | 1.121× | 19.299 | 17.402 | 1.109× |
| 32 | 131072 | 1 | 108.355 | 108.018 | 1.003× | 109.392 | 108.995 | 1.004× |
| 128 | 65536 | 1 | 99.843 | 100.152 | 0.997× | 100.713 | 100.841 | 0.999× |
| 512 | 16384 | 1 | 89.446 | 89.486 | 1.000× | 90.400 | 90.403 | 1.000× |
| 4096 | 65536 | 1 | 2000.216 | 2001.044 | 1.000× | 2003.792 | 2004.664 | 1.000× |
| 512 | 16384 | 2 | 96.295 | 96.316 | 1.000× | 97.603 | 97.629 | 1.000× |
| 2048 | 65536 | 2 | 1420.901 | 1422.905 | 0.999× | 1429.241 | 1431.841 | 0.998× |
| 8 | 16384 | 1 | 17.587 | 16.077 | 1.094× | 18.797 | 17.293 | 1.087× |
| 1 | 2048 | 1 | 1.953 | 1.948 | 1.003× | 5.763 | 5.786 | 0.996× |

### ragged：gfx938 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 9.994 | 10.061 | 0.993× | 12.515 | 12.304 | 1.017× |
| 1 | 16384 | 1 | 18.653 | 16.788 | 1.111× | 20.384 | 18.509 | 1.101× |
| 1 | 131072 | 1 | 82.643 | 82.300 | 1.004× | 84.326 | 83.904 | 1.005× |
| 32 | 16384 | 1 | 20.848 | 18.592 | 1.121× | 22.547 | 20.378 | 1.106× |
| 32 | 131072 | 1 | 103.525 | 103.138 | 1.004× | 104.854 | 104.243 | 1.006× |
| 128 | 65536 | 1 | 96.935 | 96.956 | 1.000× | 99.667 | 99.779 | 0.999× |
| 512 | 16384 | 1 | 106.160 | 106.150 | 1.000× | 108.013 | 108.067 | 0.999× |
| 4096 | 65536 | 1 | 1783.814 | 1783.326 | 1.000× | 1788.130 | 1786.902 | 1.001× |
| 512 | 16384 | 2 | 112.845 | 112.839 | 1.000× | 115.078 | 115.078 | 1.000× |
| 2048 | 65536 | 2 | 958.947 | 958.307 | 1.001× | 960.031 | 961.247 | 0.999× |
| 8 | 16384 | 1 | 20.242 | 18.502 | 1.094× | 22.067 | 20.323 | 1.086× |
| 1 | 2048 | 1 | 2.220 | 2.219 | 1.000× | 13.075 | 13.110 | 0.997× |

### 短行与特殊分布性能

| 模式 | 架构 | 额外配置数 | Graph 最小加速比 | eager 最小加速比 |
| --- | --- | ---: | ---: | ---: |
| ragged | gfx936 | 8 | 0.999× | 0.991× |
| ragged | gfx938 | 8 | 1.000× | 1.000× |

### 结果分析

常规矩阵 Graph 几何平均提升约 1.3%，最明显的代表配置为 `Q=32,N=16384`，两架构均约 1.121×。大 Q 或很长 KV 的结果多数持平：原 ragged 实现已采用相同的直方图选择框架，本轮改动主要缩短特定候选桶的串行排名链，不能预期所有 shape 都取得相同收益。

收益较小不等于已达到 HBM 带宽或算力峰值。小 Q 还受到单行一个 block 的并行度限制；进一步拆行需要中间候选存储、第二阶段选择和额外 launch，并增加短行退化及多架构验证成本。

## 相关实现与测试入口

接口的功能测试可从 AITER 仓库根目录运行：

```bash
HIP_VISIBLE_DEVICES=0 python -m pytest -q op_tests/ci_tests/test_topk_transform.py
```

接口定义见 [Python wrapper](../aiter/ops/topk_transform.py)，分发见 [native 入口](../csrc/kernels/topk_transform.cu)，HCU 实现见 [TopK helper](../csrc/include/topk_transform_hcu.cuh)，统一测试见 [test_topk_transform.py](../op_tests/ci_tests/test_topk_transform.py)。
