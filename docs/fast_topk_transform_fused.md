<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fast_topk_transform_fused 算子说明与性能报告

本接口融合每行 TopK 选择与 page-size-1 页表映射，返回分页 KV 的物理 token / 页编号。ragged KV 全局 offset 版本另见 [fast_topk_transform_ragged_fused](fast_topk_transform_ragged_fused.md)。

## 算子功能

记 `Q` 为 Query 行数、`W` 为 score 列数、`S` 为请求数、`C` 为页表容量，`K=2048`。Query 第 r 行归属于满足 `cu_seqlens_q[s]<=r<cu_seqlens_q[s+1]` 的请求 s。选择与映射关系为：

```text
start_r = 0 if row_starts is None else row_starts[r]
j ∈ [0, lengths[r])             # 序列内的局部 KV 位置
候选分数 = score[r, start_r + j]
返回索引 = page_table_size_1[s, j]
```

返回 int32 `[Q,2048]`，每行选择最大的 `min(lengths[r],2048)` 个候选，不足部分填 `-1`；空行全部为 `-1`，短行直接映射全部有效位置。输出不保证排序，同分允许不同合法选择。被选中的局部位置互不重复，但若页表存在别名，映射后的物理编号可以重复。

**页表容量 C 必须覆盖所有有效 KV 位置，不能只分配 2048 列。** `row_starts` 只影响 score 读取，查页表用 j，不使用 `start_r+j`。本接口仅支持 page size=1，不能直接接收 page size>1 的 block table；也不计算 logits、softmax 或 KV gather。

## 接口与参数

```python
from aiter.ops.topk_transform import fast_topk_transform_fused

indices = fast_topk_transform_fused(
    score, lengths, page_table_size_1, cu_seqlens_q,
    topk, row_starts=None,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `score` | FP32 Tensor `[Q,W]` | 每行候选分数，列步长为 1；允许非连续行步长 |
| `lengths` | int32 Tensor `[Q]` | 每行有效候选数，连续存储 |
| `page_table_size_1` | int32 Tensor `[S,C]` | page-size-1 的局部 KV 位置到物理编号映射，列步长为 1，允许非连续行步长；C 覆盖每个请求使用的最大有效长度 |
| `cu_seqlens_q` | int32 Tensor `[S+1]` | 连续存储；Query 分组的前缀和，首项 0、末项 Q、单调不减，当前接口要求 `S<=Q` |
| `topk` | Python `int` | 固定为 2048 |
| `row_starts` | 可选 int32 Tensor `[Q]`，默认 `None` | score 有效区间起点，应连续存储；None 表示每行从 0 开始 |
| 返回值 | int32 Tensor `[Q,2048]` | 新分配的物理 token / 页编号；无效槽位为 -1 |

所有输入须在同一 GPU。调用方保证 `0<=start_r`、`0<=lengths[r]<=C`、`start_r+lengths[r]<=W`，所用页表项为有效、非负且可用 int32 表示的物理编号。建议有效分数为有限 FP32，不依赖 NaN 排序语义。接口只做部分元数据检查，不在热路径完整检查 GPU 上的长度、前缀和或页编号。

本接口用于推理，不提供反向计算。公开函数分配输出，**没有 `out` 参数**；内部写入现有输出的 `fast_topk_transform_interface` 具有不同签名。

### Decode 与 prefill 的分组

| 模式 | 输入关系 | 行归属 |
| --- | --- | --- |
| decode | `row_starts is None` 且 `S==Q`；调用方提供 `cu_seqlens_q=[0,1,...,Q]` | 每请求恰好一个 Query，直接用 r 查第 r 行页表 |
| prefill / extend | 其他情况，包括显式 row_starts 或 `S<Q` | 使用 cu_seqlens_q 查所属请求，支持不均匀 Query 数与中间空组 |

decode 快捷路径不会用前缀和重新推断归属，因此不能用 `S==Q、row_starts=None` 搭配不均匀分组。对于需要通过前缀和分组的情况，应使用真实 prefill 输入并显式传入 row_starts（即使全为 0）。

## 使用方式

### Decode：每个请求一个 Query

```python
import torch
from aiter.ops.topk_transform import fast_topk_transform_fused

device = "cuda:0"
Q, N, K = 2, 4096, 2048
score = torch.arange(N, device=device, dtype=torch.float32).repeat(Q, 1)
lengths = torch.tensor([4096, 3000], device=device, dtype=torch.int32)
# 一请求一个 Query，因此 S=Q，cu_seqlens_q=[0,1,...,Q]。
cu_seqlens_q = torch.arange(Q + 1, device=device, dtype=torch.int32)
# page_size=1；每个有效 KV 位置均有映射，表宽是 N，不是 K。
pages = torch.arange(N, device=device, dtype=torch.int32)[None, :] * 7
pages = (pages + torch.tensor([[11], [40000]], device=device,
                             dtype=torch.int32)).contiguous()
with torch.inference_mode():
    indices = fast_topk_transform_fused(
        score, lengths, pages, cu_seqlens_q, K,
    )
assert indices.shape == (Q, K) and indices.dtype == torch.int32
for r in range(Q):
    end = int(lengths[r])
    assert torch.equal(indices[r].sort().values, pages[r, end-K:end])
```

### Prefill：每个请求多个 Query

```python
import torch
from aiter.ops.topk_transform import fast_topk_transform_fused

device = "cuda:0"
Q, S, N, W, K = 4, 2, 4096, 8205, 2048
score = torch.arange(W, device=device, dtype=torch.float32).repeat(Q, 1)
lengths = torch.tensor([4095, 4096, 2999, 3000], device=device, dtype=torch.int32)
row_starts = torch.tensor([3, 3, 4106, 4106], device=device, dtype=torch.int32)
cu_seqlens_q = torch.tensor([0, 2, 4], device=device, dtype=torch.int32)
pages = torch.arange(N, device=device, dtype=torch.int32)[None, :] * 7
pages = (pages + torch.tensor([[11], [40000]], device=device,
                             dtype=torch.int32)).contiguous()
with torch.inference_mode():
    indices = fast_topk_transform_fused(
        score, lengths, pages, cu_seqlens_q, K, row_starts=row_starts,
    )
for r in range(Q):
    owner, end = r // 2, int(lengths[r])
    # score 使用 row_starts[r]+j；查页表只使用 j。
    assert torch.equal(indices[r].sort().values, pages[owner, end-K:end])
```

上面使用递增分数方便核对；真实模型传入已经计算好的 FP32 logits。示例的排序、断言及 `int(GPU_tensor)` 仅用于正确性展示，不应纳入热路径计时。

### Graph 捕获

```python
# 接续上面的 prefill 示例，输入张量保持存活。
def run():
    return fast_topk_transform_fused(
        score, lengths, pages, cu_seqlens_q, K, row_starts=row_starts,
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

Graph 输入 shape 和地址保持不变，更新值时原地 `copy_`，并保持输入和捕获输出存活。replay 写回同一 `captured_indices`，输出消费需遵守 stream 依赖。首次 JIT 与预热应在捕获和计时之外完成。

## 实现与架构范围

gfx936/gfx938 上，普通规模输入使用 HCU 的 FP16 粗分桶、FP32 细分和候选排名，在写出阶段直接完成页表映射。每行使用一个 block；prefill 通过二分查找 Query 所属请求，decode 直接使用行号。`Q<=32` 且 score 宽度 `W<=8192` 时保留原小 shape 路径；其余 shape 的短行也有直接映射分支，不需要对分数排序。

gfx946 等架构继续使用既有 fallback。公共接口无 kernelId 参数。

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

prefill 模式按 `q_per_seq=Q/S_cfg` 构造递增有效长度：`max(0,N-q_per_seq+1+row%q_per_seq)`；`score` 逻辑宽度为 `N*S_cfg+3`，行存储再增加 13 列，`row_starts=owner*N+3`。因此表中的 N 不等于每行有效长度。decode 实际序列数为 Q、长度恒为 N、`row_starts=None`，不使用 `S_cfg`；33 项配置中有 31 个不同的 decode 实际 shape，2 项属于重复测量。

常规分数为固定种子的正态随机分布，页表使用非恒等映射。额外每种模式测试 8 项：宽存储短行 2 项（`Q∈{1,8},N=131072,length=2048`），窄分布、混合分布、全同分各 2 项（`Q∈{1,512},N=16384`）。窄分布为 `1+1e-5*randn`，混合分布额外将前 512 个有效分数置为 2，同分输入全部为 1。

下表给出常规矩阵汇总及代表性 shape 的性能对比。耗时单位均为 **μs**，数值保留三位小数；汇总用未舍入值计算。表中的 eager 均指上述 native eager 计时。

### 常规矩阵汇总

| 模式 | 架构 | 配置数 | Graph 几何平均加速 | Graph 最大加速 | native eager 几何平均加速 |
| --- | --- | ---: | ---: | ---: | ---: |
| paged_decode | gfx936 | 33 | 1.648× | 2.137× | 1.638× |
| paged_decode | gfx938 | 33 | 1.862× | 3.174× | 1.842× |
| paged_prefill | gfx936 | 33 | 1.741× | 2.441× | 1.730× |
| paged_prefill | gfx938 | 33 | 1.918× | 3.336× | 1.892× |

### paged_decode：gfx936 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 8.112 | 8.110 | 1.000× | 9.376 | 9.370 | 1.001× |
| 1 | 16384 | 1 | 25.112 | 17.349 | 1.447× | 26.448 | 18.627 | 1.420× |
| 1 | 131072 | 1 | 109.689 | 72.890 | 1.505× | 111.142 | 74.147 | 1.499× |
| 32 | 16384 | 1 | 27.388 | 19.593 | 1.398× | 28.790 | 20.742 | 1.388× |
| 32 | 131072 | 1 | 177.447 | 110.433 | 1.607× | 178.348 | 111.321 | 1.602× |
| 128 | 65536 | 1 | 198.953 | 99.929 | 1.991× | 199.747 | 99.945 | 1.999× |
| 512 | 16384 | 1 | 206.572 | 108.599 | 1.902× | 207.222 | 109.401 | 1.894× |
| 4096 | 65536 | 1 | 4610.923 | 2354.156 | 1.959× | 4596.851 | 2314.672 | 1.986× |
| 512 | 16384 | 2 | 206.992 | 108.489 | 1.908× | 208.041 | 109.155 | 1.906× |
| 2048 | 65536 | 2 | 2386.192 | 1213.990 | 1.966× | 2395.651 | 1238.246 | 1.935× |
| 8 | 16384 | 1 | 25.423 | 18.798 | 1.352× | 26.704 | 20.058 | 1.331× |
| 1 | 2048 | 1 | 2.191 | 2.181 | 1.004× | 5.552 | 5.488 | 1.012× |

### paged_decode：gfx938 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 9.265 | 9.268 | 1.000× | 11.406 | 11.282 | 1.011× |
| 1 | 16384 | 1 | 28.775 | 19.986 | 1.440× | 30.550 | 21.757 | 1.404× |
| 1 | 131072 | 1 | 125.522 | 84.068 | 1.493× | 127.456 | 85.603 | 1.489× |
| 32 | 16384 | 1 | 31.115 | 22.439 | 1.387× | 33.050 | 24.090 | 1.372× |
| 32 | 131072 | 1 | 192.958 | 107.734 | 1.791× | 194.096 | 108.819 | 1.784× |
| 128 | 65536 | 1 | 224.382 | 101.805 | 2.204× | 224.633 | 103.049 | 2.180× |
| 512 | 16384 | 1 | 268.942 | 119.142 | 2.257× | 270.173 | 120.486 | 2.242× |
| 4096 | 65536 | 1 | 6423.905 | 2024.150 | 3.174× | 6423.382 | 2024.482 | 3.173× |
| 512 | 16384 | 2 | 268.803 | 119.184 | 2.255× | 269.965 | 120.457 | 2.241× |
| 2048 | 65536 | 2 | 3228.157 | 1046.071 | 3.086× | 3226.233 | 1046.619 | 3.083× |
| 8 | 16384 | 1 | 29.079 | 21.627 | 1.345× | 30.579 | 23.094 | 1.324× |
| 1 | 2048 | 1 | 2.446 | 2.450 | 0.999× | 11.700 | 11.596 | 1.009× |

### paged_prefill：gfx936 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 8.698 | 8.708 | 0.999× | 10.042 | 10.026 | 1.002× |
| 1 | 16384 | 1 | 25.888 | 17.323 | 1.494× | 27.306 | 18.698 | 1.460× |
| 1 | 131072 | 1 | 112.832 | 72.040 | 1.566× | 114.432 | 73.277 | 1.562× |
| 32 | 16384 | 1 | 27.700 | 19.319 | 1.434× | 28.954 | 20.509 | 1.412× |
| 32 | 131072 | 1 | 177.323 | 108.887 | 1.629× | 178.310 | 109.878 | 1.623× |
| 128 | 65536 | 1 | 201.840 | 101.324 | 1.992× | 202.963 | 101.856 | 1.993× |
| 512 | 16384 | 1 | 201.661 | 95.608 | 2.109× | 202.630 | 96.736 | 2.095× |
| 4096 | 65536 | 1 | 4549.144 | 1963.984 | 2.316× | 4553.247 | 1964.724 | 2.317× |
| 512 | 16384 | 2 | 204.466 | 104.595 | 1.955× | 205.497 | 105.696 | 1.944× |
| 2048 | 65536 | 2 | 2720.463 | 1317.850 | 2.064× | 2730.379 | 1325.250 | 2.060× |
| 8 | 16384 | 1 | 26.163 | 18.738 | 1.396× | 27.472 | 20.019 | 1.372× |
| 1 | 2048 | 1 | 2.661 | 2.661 | 1.000× | 5.827 | 5.837 | 0.998× |

### paged_prefill：gfx938 典型 shape

| `Q` | `N` | `S_cfg` | Graph 原始 | Graph 优化 | Graph 加速比 | eager 原始 | eager 优化 | eager 加速比 |
| ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| 1 | 4096 | 1 | 9.947 | 9.953 | 0.999× | 12.717 | 12.880 | 0.987× |
| 1 | 16384 | 1 | 29.671 | 19.949 | 1.487× | 31.504 | 21.741 | 1.449× |
| 1 | 131072 | 1 | 129.206 | 83.086 | 1.555× | 131.197 | 84.621 | 1.550× |
| 32 | 16384 | 1 | 31.730 | 22.269 | 1.425× | 33.597 | 24.016 | 1.399× |
| 32 | 131072 | 1 | 194.674 | 104.472 | 1.863× | 195.984 | 105.882 | 1.851× |
| 128 | 65536 | 1 | 222.989 | 98.208 | 2.271× | 224.281 | 100.579 | 2.230× |
| 512 | 16384 | 1 | 268.504 | 113.670 | 2.362× | 269.593 | 115.433 | 2.335× |
| 4096 | 65536 | 1 | 6264.009 | 1877.506 | 3.336× | 6269.630 | 1879.774 | 3.335× |
| 512 | 16384 | 2 | 272.233 | 121.585 | 2.239× | 273.398 | 123.184 | 2.219× |
| 2048 | 65536 | 2 | 3236.821 | 1007.251 | 3.214× | 3238.997 | 1009.043 | 3.210× |
| 8 | 16384 | 1 | 29.928 | 21.568 | 1.388× | 31.837 | 23.469 | 1.357× |
| 1 | 2048 | 1 | 3.013 | 3.014 | 1.000× | 13.114 | 13.334 | 0.983× |

### 短行与特殊分布性能

| 模式 | 架构 | 额外配置数 | Graph 最小加速比 | eager 最小加速比 |
| --- | --- | ---: | ---: | ---: |
| paged_decode | gfx936 | 8 | 1.050× | 1.020× |
| paged_decode | gfx938 | 8 | 1.048× | 0.992× |
| paged_prefill | gfx936 | 8 | 1.200× | 0.990× |
| paged_prefill | gfx938 | 8 | 1.203× | 1.004× |

### 结果分析

常规矩阵 Graph 的几何平均加速：gfx936 decode **1.648×**、prefill **1.741×**；gfx938 decode **1.862×**、prefill **1.918×**。大 Q、长 KV 的收益更明显，例如 `Q=4096,N=65536`，gfx938 decode 达 **3.174×**、prefill 达 **3.336×**。

收益来自共享选择框架、融合写出映射及 prefill 分组查找等改动的组合，表格不能单独证明每项技术各贡献多少。小 shape 保留原路径，宽存储短行直接写出索引，避免为统一实现牺牲边界性能。以上为指定输入分布及平台的设备计时结果，不代表模型端到端加速。

## 相关实现与测试入口

接口的功能测试可从 AITER 仓库根目录运行：

```bash
HIP_VISIBLE_DEVICES=0 python -m pytest -q op_tests/ci_tests/test_topk_transform.py
```

接口定义见 [Python wrapper](../aiter/ops/topk_transform.py)，分发见 [native 入口](../csrc/kernels/topk_transform.cu)，HCU 实现见 [TopK helper](../csrc/include/topk_transform_hcu.cuh)，统一测试见 [test_topk_transform.py](../op_tests/ci_tests/test_topk_transform.py)。
