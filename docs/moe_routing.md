<!-- SPDX-License-Identifier: MIT -->
<!-- Copyright (c) 2026 Hygon Information Technology Co., Ltd. -->
# MoE routing：稳定元数据、Scatter 与 Gather

`aiter.ops.moe_routing` 提供本卡 MoE 的 GPU 路由前端，分为 prepare、scatter、gather。
prepare 在 GPU 生成计数和双向映射；scatter 按映射复制或量化；gather 把专家输出按路由权重
汇聚回 token。所有计算原语采用预分配 out 接口，返回 None，使用 `module_moe_utils`。

本接口覆盖 BF16 init/finalize 数学子集及 FP16/FP32、INT8/E4M3FN 扩展。
不包含跨卡 AllToAll、专家 GEMM、softmax/topk 选择、权重归一化或 autograd。
它不构成 CANN 全 ABI、全部低精度模式或 xpu-perf provider 的兼容声明。
旧 atomic 布局接口见 [EP 算子族](ep_scatter_family.md)。

## 路由合同

M 为 token 数，K 为每 token 路由数，E 为本地专家数；1≤K≤30，1≤E≤1200。
ids 是连续 GPU int32/int64[M,K]，weights 是 FP32[M,K]。
可选 expert_map 为 int32[G]，先检查 global id∈[0,G)，再映射并检查 local id∈[0,E)。
无 map 时 ids 直接是本地专家编号。负值、越界 id/map 值不参与输出。
同一个 token 的重复专家保留为不同 k，不去重。

原始路由序号为 **f=t*K+k**。prepare 按 `(local expert, f)` 排序；同专家内按 token、k
升序，输出行序确定。输入权重不影响是否保留路由，权重为0的路由也会占行。

若外部 ABI 使用 `k*M+t`，须显式转换：

```text
f_token_major = (f_external % M)*K + floor(f_external/M)
f_external   = (f_token_major % K)*M + floor(f_token_major/K)
```

M=0 时无有效索引，不执行上述除法。仅更换函数名不能替代外部 ABI 的索引/布局适配。

## 元数据和容量

`allocate_moe_routing(ids,E,alignment=1,expert_capacity=0)` 在捕获外分配 RoutingBuffers。
令 Tcap 为容量，c[e] 为 active/drop 之后保留的有效路由数：

| 字段 | 类型/形状 | 内容 |
|---|---|---|
| counts | int32[E] | c[e]，只含有效行，不含 padding |
| offsets | int32[E] | 专家段 exclusive starts |
| route_ids | int32[Tcap] | 输出行→f；padding/容量尾部 -1 |
| inv_perm | int32[M,K] | 原始路由→输出行；无效/截断/丢弃 -1 |
| token_ids | int32[Tcap] | 输出行→t；padding -1 |
| token_weights | FP32[Tcap] | 对应 weights[t,k]；padding 0 |
| m_indices | int32[Tcap] | 输出行→本地专家；padding -1 |
| valid_rows | int32[1] GPU | sum(c) |
| span_rows | int32[1] GPU | 包含专家 padding 的使用跨度，≤Tcap |
| status | int32[1] GPU | 0正常；1负active；2DropPad与非零active冲突 |
| workspace | uint8[bytes] | 两份64位排序key、scan辅助及hipCUB scratch，256字节对齐 |

counts/offsets 在 scatter/gather 后保持不变。每次 prepare 覆写全部元数据和状态，
无效路由不保留旧输出。任意有效行 r 都满足 `inv_perm.flatten()[route_ids[r]]==r`。

| 布局 | 条件 | offsets / span_rows | 分配容量 |
|---|---|---|---|
| 紧密 | alignment=1，C=0 | offsets[e]=sum(c[:e])；span=sum(c) | M*K |
| aligned | alignment=A 为正的2次幂，C=0 | p[e]=ceil(c[e]/A)*A；offsets=sum(p[:e])；span=sum(p) | M*K+E*(A-1) |
| DropPad | expert_capacity=C>0，alignment=1 | offsets[e]=e*C；span=E*C；每专家保留前min(raw_count,C)行 | E*C |

所有32位元数据要求 M*K、Tcap≤INT32_MAX。允许提供比所需上界更大的自有容量，
同一组 row metadata 必须等长。EP 分片不缩减默认 M*K 容量：它是任意动态路由的安全上界，
不是当前有效行数；大 EP 的固定容量零填成本也包含在性能结果中。

active_num 是可选 GPU int64 单元素张量。None/0 表示不截断；正数 N 保留稳定排序后的
全局前 N 条有效路由，超过有效数等于不截断。它不是每个专家各保留 N 条。
DropPad 只接受 None/0 active，先按专家截断再留固定 C 行。动态非法值安全清空有效输出，
写 status；调用方可在捕获外执行 `check_moe_routing_status(status)` 同步并抛出异常。
status 诊断不属于热路径，不能放在 Graph 捕获或性能计时内。

`moe_routing_cumsum_out(out,counts)` 生成 inclusive 有效计数前缀和。
counts 要求非负且总和不溢出 INT32；它与 aligned offsets/padded span 不是同一对象。

## Scatter 和动态量化

输入 x 为连续 FP16/BF16/FP32[M,H]，H>0。支持 H 尾部和非零 storage offset。
out 为 [Tcap,H]；所有 padding/容量尾部都写0，量化 scale 写1。

| mode | out dtype | out_scale | smooth |
|---|---|---|---|
| none | 与 x 相同 | None | 必须 None，原样复制 |
| int8 | torch.int8 | FP32[Tcap] 或 [Tcap,1] | None 或 FP32[E,H] |
| fp8_e4m3fn | torch.float8_e4m3fn | FP32[Tcap] 或 [Tcap,1] | None 或 FP32[E,H] |

每个有效输出行 r 单独量化：t=token_ids[r]，e=m_indices[r]。
smooth 按本地专家索引，不同专家可有不同缩放。FP32量化中间量合同为：

```text
F(x) = abs(x)<FLT_MIN ? copysign(0,x) : x
z[j] = F(RN(F(float(x[t,j])) * (smooth存在 ? F(smooth[e,j]) : 1)))
amax = max(abs(z)); qmax = 127(INT8) 或448(E4M3FN)
scale = amax==0 ? 1 : max(RN(amax/qmax),FLT_MIN)
v[j] = RN(z[j]/scale)
INT8: q[j] = RNE(clamp(v[j],-127,127))
FP8:  q[j] = E4M3FN_RNE(clamp(v[j],-448,448))
```

RN 为 FP32 round-to-nearest，RNE 为 ties-to-even；FLT_MIN 为 FP32最小正规数。
输入、smooth及其乘积要求有限值，不定义 NaN/Inf 量化；没有隐含 GPU→CPU 有限性扫描。
INT8 实现避免非有限到整数的未定义转换，但这不扩展数值支持范围。
FP8 比较编码字节和 FP32 scale，并独立检查反量化误差。

这个 scale 合同与旧 EP 的两级除法/smooth epsilon 不同。参考实现用 FP64除法后转FP32
表达 RN；不能用可能转成乘倒数的 Torch FP32 scalar-div 当作逐位 oracle。

## Gather、bias 和 residual

expert_output 为连续 FP16/BF16/FP32[Tcap,Hout]，out 为同dtype[M,Hout]。
Hout 独立于 scatter 的 H。weights 为 FP32[M,K]，使用 inv_perm/m_indices 找回有效行。
bias 可选 FP32[E,Hout]，在乘权重前加入。residual（外部数学子集的 x1）和x2与out同dtype。

对 token t，按以下顺序计算 FP32 accumulator，最后一次性转为输出dtype：

```text
acc = 0
若 residual存在且 start≤t<end:
    acc = RN(float(residual[t-start或广播行0]) * res_scale)
若 x2存在: acc = RN(acc + float(x2[t]))
对 k=0..K-1 的有效路由:
    r = inv_perm[t,k]; e = m_indices[r]
    z = float(expert_output[r])
    若 bias存在: z = RN(z + bias[e])
    acc = RN(acc + RN(z * weights[t,k]))
out[t] = cast(acc)
```

乘法和加法分开舍入，未合并为 FMA。不同 k 的累加次序固定。
FP32 子正规数沿用模块现有 FTZ 编译策略，不承诺保留 IEEE 子正规结果；
上述顺序公式的 RN 表示该执行环境中的 FP32 舍入。
out 每次覆写；不读旧 out。非有限值遵从上述操作顺序传播，例如0乘Inf为NaN。

residual_start/end 定义全局 token 区间；end=-1表示M。residual 为 `[end-start,Hout]`
或 `[1,Hout]` 广播，仅在该区间生效；区间可为空。x2 是可选 `[M,Hout]` 全局逐元素加数。
SP=8 的rank可令 chunk=ceil(M/8)、start=min(rank*chunk,M)、end=min(start+chunk,M)。
输出仍是全局 `[M,Hout]`，这里没有跨卡归约/通信。

## 公开接口

```python
from aiter.ops.moe_routing import *

b = allocate_moe_routing(ids, E, alignment=1, expert_capacity=0)
moe_routing_workspace_size(ids)  # bytes，capture外查询，可能触发JIT
b.prepare(ids, weights, expert_map=None, active_num=None)
moe_routing_prepare_out(ids, weights, expert_map, counts, offsets, route_ids,
    inv_perm, token_ids, token_weights, m_indices, valid_rows, span_rows, status,
    workspace, E, alignment=1, active_num=None, expert_capacity=0)
moe_routing_scatter_out(out, out_scale, input, token_ids, m_indices,
    smooth=None, mode="none")
moe_routing_gather_out(out, expert_output, weights, inv_perm, m_indices,
    bias=None, residual=None, res_scale=1., residual_start=0, residual_end=-1, x2=None)
moe_routing_cumsum_out(out, counts)
moe_init_routing_out(out, out_scale, input, ids, weights, buffers,
    expert_map=None, smooth=None, mode="none", active_num=None)
moe_finalize_routing_out(out, expert_output, weights, buffers, bias=None,
    residual=None, res_scale=1., residual_start=0, residual_end=-1, x2=None)
check_moe_routing_status(status)  # 显式同步诊断
```

所有张量同GPU、连续且requires_grad=False，输出与输入/其他输出不重叠。
host拒绝错误dtype/device/shape、非法K/E/alignment、容量不足和地址别名。
不使用CPU路由、隐藏Torch fallback或热路径临时张量分配。
prepare内部hipCUB排序使用调用方workspace；首次JIT和workspace查询放在capture外。
fake/meta实现和mutation声明支持Torch 2.10/2.11 fullgraph编译，固定shape/capacity下的内容可变。

## Graph 示例

```python
import torch
from aiter.ops.moe_routing import (
    allocate_moe_routing, moe_init_routing_out, moe_finalize_routing_out,
    check_moe_routing_status,
)
M,H,K,E = 128,1536,15,800
x = torch.randn(M,H,device="cuda",dtype=torch.bfloat16)
ids = torch.randint(E,(M,K),device="cuda",dtype=torch.int32)
w = torch.rand(M,K,device="cuda")
b = allocate_moe_routing(ids,E)
expanded = torch.empty(b.route_ids.numel(),H,device="cuda",dtype=x.dtype)
y = torch.empty_like(x)
active = torch.zeros(1,device="cuda",dtype=torch.int64)
def route_roundtrip():
    moe_init_routing_out(expanded,None,x,ids,w,b,active_num=active)
    # 示例省略专家计算：用expanded作为expert_output，仅验证路由往返。
    moe_finalize_routing_out(y,expanded,w,b)
route_roundtrip()
torch.cuda.synchronize()
graph = torch.cuda.CUDAGraph()
with torch.cuda.graph(graph):
    route_roundtrip()  # 图内包含计数、排序、初始化、scatter和gather
ids.copy_(torch.randint(E,(M,K),device="cuda",dtype=ids.dtype))
x.normal_(); w.uniform_(); active.fill_(M*K//2)
graph.replay()
check_moe_routing_status(b.status)  # 捕获外检查
```

量化时另分配 INT8/E4M3FN expanded、FP32[Tcap,1] scale 和可选 FP32[E,H] smooth，
传 mode。Gather 消费专家计算产生的浮点结果，不能把量化 expanded 直接当作浮点专家输出。
`torch.compile(route_roundtrip,fullgraph=True)` 可复用相同预分配buffer；shape变化允许重新编译。

## 验证与当前性能

2026-10-21，DTK26.04/aicc、HIP6.3.26113：

| 验证项 | gfx936 / Torch2.10.0 | gfx938 / Torch2.11.0 |
|---|---:|---:|
| 新前端边界/数值/Graph/fake/fullgraph套件 | 242/242 PASS | 242/242 PASS |
| 旧EP回归 | 88/88 PASS | 88/88 PASS |
| Gather，46个M×SP1/8，Hout1536，K8，EP8 | 92/92 PASS | 92/92 PASS |
| Scatter，46个M×Eglobal64/128×INT8/E4M3FN，H4096，K8，EP8 | 184/184 PASS | 184/184 PASS |
| BF16 init，M10240/20480/40960/81920×K15/20/25/30×E800/1000/1200×H1024/1280/1536/2048/4096 | 240/240 PASS | 240/240 PASS |
| 同一240配置的BF16 finalize | 240/240 PASS | 240/240 PASS |

主矩阵516组配置、756条独立算子记录，每端0失败/跳过/OOM；包含M=6192。
最大expandedX为18.75GiB，按完整shape执行，参考分块计算。
索引逐项精确、INT8/FP8编码及scale精确；Gather与独立顺序FP32参考比较，
并以FP64和随K、sum(abs(term))变化的误差界检查。

性能计时包含GPU元数据生成和必要初始化，分别记录prepare/scatter/gather/full。
init/finalize的full=prepare+scatter+gather；Scatter的full=prepare+scatter；
Gather的full=prepare+gather，专家输出在计时前准备。没有包含专家GEMM或通信。
eager/Graph各7轮交替顺序，预分配buffer、JIT/warmup在计时外。
测试设备为 gfx936/BW1000 64G 和 gfx938/BW1101。

当前完整链耗时（μs，7轮中位数）：

| 配置 | gfx936 eager | gfx936 Graph | gfx938 eager | gfx938 Graph |
|---|---|---|---|---|
| Gather：M=1，SP=1 | 86.56 | 57.28 | 177.20 | 71.60 |
| Gather：M=6192，SP=8 | 178.56 | 155.04 | 246.96 | 198.80 |
| Gather：M=131072，SP=1 | 2407.28 | 2345.84 | 3339.92 | 3270.40 |
| INT8 Scatter：M=6192，Eglobal=128 | 490.00 | 468.24 | 642.24 | 594.48 |
| E4M3FN Scatter：M=131072，Eglobal=128 | 8820.70 | 8764.54 | 11673.75 | 11605.91 |
| BF16 init/finalize：M=10240，K=15，E=800，H=1024 | 1008.32 | 986.24 | 1113.44 | 1075.44 |
| BF16 init/finalize：M=81920，K=30，E=1200，H=4096 | 52671.67 | 52656.46 | 47993.71 | 47527.31 |

最大 BF16 init/finalize 配置 M81920/K30/E1200/H4096 的 Graph 分阶段耗时（μs）：

| 架构 | prepare | scatter | gather | 完整链 |
|---|---|---|---|---|
| gfx936 | 1101.44 | 33431.70 | 18101.73 | 52656.46 |
| gfx938 | 1314.80 | 29709.73 | 17023.74 | 47527.31 |

全部516组配置均完成 eager 和 Graph 性能测量。
各阶段单独测量，缓存和提交边界不同，分阶段中位数之和不要求等于完整链中位数。
Graph每轮2次回放，eager每轮2次API调用；小shape eager包含Python提交空隙。
同版还通过23项MoE sum/align、TopK及Softmax/ReduceSum相关回归。

## 源码与复现

- [Python](../aiter/ops/moe_routing.py)、[native](../csrc/kernels/moe_routing_kernels.cu)、[公共检查](../csrc/include/moe_routing_common.cuh)、[绑定](../csrc/pybind/moe_utils_pybind.cu)。
- [独立参考和边界套件](../op_tests/test_moe_routing.py)、[主矩阵与性能入口](../op_tests/op_benchmarks/bench_moe_routing.py)。

在目标checkout设置PYTHONPATH和对应GPU_ARCHS，AITER_JIT_DIR使用独立目录：

```bash
python -m pytest -q op_tests/test_moe_routing.py op_tests/test_ep_scatter_family.py
python op_tests/op_benchmarks/bench_moe_routing.py --correctness --output hygon_tmp/moe_routing/correctness
python op_tests/op_benchmarks/bench_moe_routing.py --bench --rounds 7 --output hygon_tmp/moe_routing/performance
```
