<!-- SPDX-License-Identifier: MIT -->
<!-- Copyright (c) 2026 Hygon Information Technology Co., Ltd. -->
# EP Scatter/Gather 算子族

六个 `ep_*` 接口提供本卡 MoE 重排、融合量化和加权汇聚。接口位于
`aiter/ops/moe_op.py`，使用 `module_moe_utils`，参数顺序和返回 `None` 保持不变。
需要 GPU 自动生成元数据、确定行序、active/drop、bias 或 SP residual 时，使用
[MoE routing 前端](moe_routing.md)。两套接口的布局和量化合同不同。

## 支持范围

| 项目 | 当前合同 |
|---|---|
| 路由 | 连续 int32/int64[M,K]；scatter/gather 支持 1≤K≤30 |
| 本地专家 | 1≤E≤1200；scan 线程数≤1024，较大 E 由每线程多元素处理 |
| ep_build_m_indices | 保持通用 K，不新增 K≤30 限制 |
| 激活 | 普通 scatter 为 INT8；融合 quant 输入 FP16/BF16/FP32；gather 输入/输出 FP16/BF16/FP32 |
| 特征宽度 | scatter：1≤H≤65536 且 H%16=0；gather：H 是 16 字节向量元素数的整数倍 |
| 张量 | 连续、同 GPU、requires_grad=False；输入和可写输出不重叠 |
| 对齐 A | 正的 2 的幂，调用方提供正确 counts/starts 和容量 |
| 索引 | INT32，路由数和输出行数不超过 INT32_MAX |
| 执行 | 当前 HIP stream，预分配输出，支持 Graph；回放前必须恢复游标 |

支持满足向量对齐的非零 storage offset。普通/融合 quant 输入地址至少按
`max(16,8*sizeof(input_dtype))` 字节对齐；smooth 输入按 `16*sizeof(input_dtype)`、
smooth 表按 64 字节、量化输出按 16 字节对齐。不满足时明确报错，不创建隐式连续副本。

expert_map 是可选 int32[G]。先检查原始 int64/int32 id 是否在 [0,G)，再查 map；
scatter 只接受映射后 [0,E)。无 map 时直接检查 [0,E)。高段 global id 可映射回本地专家；
负值、越界 id 和越界 map 值安全丢弃。Gather 没有 E 参数，它检查 map 边界、映射值非负和
inv_perm 行范围，必须消费配套 scatter 生成的映射。

## 布局与初始化

```text
c[e] = 专家 e 的有效路由数
p[e] = ceil(c[e]/A)*A
start[e] = sum(p[:e]); T = sum(p)
inv_perm[t,k] = 本路由认领的行，无效为 -1
m_indices[r] = 本地专家号
```

atomicAdd 认领行使专家内行序不确定；不同 k 的重复专家保留为不同路由。
应通过 inv_perm 消费结果，不能假设按 token 排序。

| 接口 | 输入游标 | 调用后游标 | padding m_indices |
|---|---|---|---|
| ep_scatter | counts[E] | start+已认领行数 | -1 |
| ep_fused_quant_scatter | counts[E] | start+已认领行数 | 保留调用方预填值 |
| ep_fused_fp8_quant_scatter | counts[E] | start+已认领行数 | fill=True 为专家号，否则 -1；容量尾部 -1 |
| ep_fused_smooth_quant_scatter | starts[E] | start+已认领行数 | 保留调用方预填值 |
| ep_build_m_indices | 无 | 无 | -1，容量尾部也为 -1 |

counts/starts 是破坏性输入，调用结束后不能继续当原 counts/offsets；Graph 每次回放必须
从保存值 copy_ 恢复。激活 padding 的数据和 scale 由调用方初始化，scatter 只写有效行。

host 检查 shape/dtype/device/别名和静态容量关系，不把 GPU counts 读回 CPU。
counts/starts 内容必须与 ids/map 一致；设备容量检查会在越界写之前 trap。
trap 不代替正确的 counts，也不保证发现所有内容错误。

M=0 时合法调用清零游标、把非空 m_indices 填为 -1，避免零 block launch。
无有效路由时 inv_perm=-1，Gather 覆写为零。

## API

全部输出预分配，全部接口返回 None。

```python
from aiter.ops.moe_op import (
    ep_scatter, ep_gather, ep_build_m_indices, ep_fused_quant_scatter,
    ep_fused_fp8_quant_scatter, ep_fused_smooth_quant_scatter,
)
ep_scatter(aq, aq_scale, ids, expert_map, counts_cursor,
           aq_out, scale_out, m_indices, inv_perm, E, A)
ep_fused_quant_scatter(x, ids, expert_map, counts_cursor,
                      aq_out, scale_out, m_indices, inv_perm, E, A)
ep_fused_fp8_quant_scatter(x, ids, expert_map, counts_cursor,
                          aq_out, scale_out, m_indices, inv_perm, E, A,
                          fp8type, fill_padded_m_indices)
ep_fused_smooth_quant_scatter(x, ids, expert_map, starts_cursor, smooth,
                             aq_out, scale_out, m_indices, inv_perm, E, A)
ep_build_m_indices(ids, m_indices, E, A)
ep_gather(expert_output, ids, weights, inv_perm, expert_map, out)
```

| 参数 | 形状和类型 |
|---|---|
| aq / aq_scale | INT8[M,H] / FP32[M] 或 FP32[M,1] |
| x | FP16/BF16/FP32[M,H] |
| ids / weights | int32/int64[M,K] / FP32[M,K] |
| expert_map | None 或 int32[G] |
| counts_cursor / starts_cursor | int32[E] |
| smooth | FP32[E,H]，按本地专家索引 |
| aq_out | INT8[T,H]；旧 FP8 接口接受单字节存储并写 FP8 编码 |
| scale_out | FP32[T] 或 FP32[T,1] |
| m_indices / inv_perm | int32[T] / int32[M,K] |
| expert_output / out | 相同浮点 dtype 的 [T,Hout] / [M,Hout] |

fp8type=0 为 E4M3，1 为 E5M2。单字节存储必须按所选 FP8 格式解释，不能当 INT8 数值。
新前端直接要求 torch.float8_e4m3fn 输出。

## 数值合同

普通 INT8 动态量化使用 FP32 amax=max(abs(x))：

```text
amax=0: q=0, scale=1
否则 amax=max(amax, FLT_MIN*127)
inv=RN(127/amax); scale=RN(1/inv)
q=clamp(RNE(x*inv), -128, 127)
```

这是旧接口的两次除法合同，不能用新前端 scale=RN(amax/127) 替代参考。
旧 smooth：z=x*smooth[e]，amax=max(max(abs(z)),1e-6)，scale=amax/127，
q=clamp(RNE(z*(127/amax)),-128,127)。旧 FP8 保留
scale=max(amax/qmax,1/(qmax*512))，qmax 为 448 或 57344。
量化输入、smooth 及乘积要求有限值；非正规数受模块现有 FTZ 编译策略影响。

Gather 按 k 升序使用 FP32 累加 weights[t,k]*expert_output[inv_perm[t,k],j]，
末尾转回输出 dtype；没有 bias/residual 参数，不进行 softmax 或权重归一化。
FP32 子正规数沿用模块现有 FTZ 编译策略，不承诺保留 IEEE 子正规结果。
输出每次覆写，Hout 可以与 scatter 的 H 不同；FP32 启动几何按 4 元素向量计算。

## 使用例子

此例 counts 和容量 readback 放在捕获外；动态路由须把计数生成放进 GPU 流程，
也可以使用新前端 prepare 生成 counts 后消费旧接口。

```python
import torch
from aiter.ops.moe_op import ep_scatter, ep_gather

M, H, K, E, A = 64, 1024, 8, 16, 64
ids = torch.randint(E, (M,K), device="cuda", dtype=torch.int32)
counts = torch.bincount(ids.flatten().long(), minlength=E).int()
T = int(((counts+A-1)//A*A).sum())
cursor = torch.empty_like(counts)
q = torch.randint(-127,128,(M,H), device="cuda", dtype=torch.int8)
scale = torch.ones(M,1,device="cuda")
expanded = torch.zeros(T,H,device="cuda",dtype=torch.int8)
expanded_scale = torch.ones(T,1,device="cuda")
mi = torch.full((T,),-1,device="cuda",dtype=torch.int32)
inv = torch.empty(M,K,device="cuda",dtype=torch.int32)
def dispatch():
    cursor.copy_(counts)
    ep_scatter(q,scale,ids,None,cursor,expanded,expanded_scale,mi,inv,E,A)
dispatch()  # capture 前完成 JIT
torch.cuda.synchronize()
graph = torch.cuda.CUDAGraph()
with torch.cuda.graph(graph):
    dispatch()
graph.replay()
# 实际应用由专家计算产生 [T,Hout] 浮点结果。
expert_output = torch.randn(T,H,device="cuda",dtype=torch.bfloat16)
weights = torch.rand(M,K,device="cuda")
out = torch.empty(M,H,device="cuda",dtype=torch.bfloat16)
ep_gather(expert_output,ids,weights,inv,None,out)
```

## 验证和当前性能

2026-10-21：gfx936/BW1000 64G（Torch 2.10.0）和 gfx938/BW1101（Torch 2.11.0）
各通过旧接口88项测试：原58项、大K/E、双ids类型、高段map、empty/zero及错误dtype、FP32 Gather、
非默认stream和变化输入Graph。

两端使用 DTK26.04/aicc、HIP6.3.26113。

当前代表配置 M8192/H1024/K8/E16/A64，BF16激活（普通scatter输入INT8），耗时μs：

| 接口 | gfx936 eager | gfx936 Graph | gfx938 eager | gfx938 Graph |
|---|---|---|---|---|
| scatter | 120.51 | 117.73 | 140.52 | 136.23 |
| quant | 286.94 | 283.36 | 409.80 | 405.12 |
| fp8 | 312.92 | 309.79 | 387.89 | 383.06 |
| build | 36.29 | 34.21 | 40.08 | 37.14 |
| gather | 134.97 | 132.48 | 121.93 | 119.08 |
| smooth | 194.43 | 190.79 | 265.64 | 261.36 |

共完成40组配置的性能测量，每项取7轮中位数；scatter计入cursor.copy_。
Graph图内20次完整API调用，每轮20次回放，除以400得到单调用耗时；
eager每轮20次实际API调用，包含host检查和提交间隙。两种模式分别解释。

两轮独立复测中，两架构的40个Graph配置都满足回退不超过5%的门槛。
小shape eager仍有以下残留，因此本版尚未完全通过全部eager性能门槛。
表中幅度为两次独立中位数相对各自基线的范围，所有配置E16/A64：

| 架构 | 接口 | M / H / K | eager回退范围 |
|---|---|---|---|
| gfx936 | scatter | 1 / 128 / 1 | 6.15%–6.44% |
| gfx936 | gather | 64 / 1024 / 2 | 5.15%–6.13% |
| gfx936 | scatter | 128 / 4096 / 4 | 5.94%–6.85% |
| gfx938 | scatter | 1 / 128 / 1 | 5.75%–8.25% |
| gfx938 | fp8 | 64 / 1024 / 2 | 6.20%–8.91% |
| gfx938 | scatter | 128 / 4096 / 4 | 5.97%–7.75% |
| gfx938 | smooth | 128 / 4096 / 4 | 6.42%–6.62% |

这些残留出现在含host检查和提交间隙的eager计时中；本次未进一步拆分两者的贡献。
所有参数、地址和容量保护均保留，量化和输出合同未为计时作简化。

## 源码和复现

- [Python API](../aiter/ops/moe_op.py)、[native](../csrc/kernels/moe_align_sum_kernels.cu)、[公共检查](../csrc/include/moe_routing_common.cuh)。
- [旧接口测试](../op_tests/test_ep_scatter_family.py)、[新前端](moe_routing.md)。
- `python -m pytest -q op_tests/test_ep_scatter_family.py op_tests/test_moe_routing.py`。
