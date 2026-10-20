<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# ck_gdn 使用说明（CK GDN 原生入口）

`aiter.ck_gdn_prefill` / `aiter.ck_gdn_decode` 是 CK Tile GDN 的原生入口：
直接调用 `3rdparty/composable_kernel/example_hcu/ck_tile/21_gdn` 的 CK launcher，
语义、约束和数值都是 CK 自己的。仓库里的 HIPC GDN（`aiter/ops/fla.py`，
`module_cpp_api`）和 Triton 参考实现（`aiter.ops.triton.fla`）保持各自的入口，
**两者之间没有自动分发或回退**：用哪个就显式调用哪个。

本文只讲用法，以及和 HIPC GDN 用法的区别：

- 新用户：看第 2~4 节的快速开始与典型用法；
- **原来用 HIPC GDN、现在要切到 CK GDN**：直接看 5.4 的切换步骤与示例；
- 想知道"能不能和 HIPC 完全对齐"：看 5.5；
- 读性能数字前先看 6.1 的口径说明，实测数据在 6.2。

CK 的内部实现、构建配置和验证覆盖见文末"代码索引"。

## 1. 入口一览

| API | 作用 |
|---|---|
| `aiter.ck_gdn_prefill_workspace_bytes(q, v, **flags)` | 计算 prefill 所需 workspace 字节数 |
| `aiter.ck_gdn_prefill_alloc_workspace(q, v, cu_seqlens=None, **flags)` | 直接分配一块 `uint8` workspace |
| `aiter.ck_gdn_prefill(q, k, v, g, beta, workspace=None, ...)` | chunk 化 prefill 全流水线，返回 `(output, final_state)` |
| `aiter.ck_gdn_decode(q, k, v, g, beta, ...)` | fused recurrent decode/序列更新，返回 `(output, final_state)` |

`final_state` 在未产生时返回 `None`（等价于 `numel() == 0`）。

## 2. 快速开始

### prefill

```python
import torch
import aiter

dev, dtype = "cuda", torch.bfloat16
T, HQK, HV = 4096, 2, 8

q = torch.randn(T, HQK, 128, dtype=dtype, device=dev) * 0.1
k = torch.randn(T, HQK, 128, dtype=dtype, device=dev) * 0.1
v = torch.randn(T, HV, 128, dtype=dtype, device=dev) * 0.1
g = -torch.rand(T, HV, dtype=torch.float32, device=dev)       # log 衰减
beta = torch.rand(T, HV, dtype=torch.float32, device=dev)     # 已 sigmoid

flags = dict(use_g=True, use_exp2=False, transpose_state=True)
ws = aiter.ck_gdn_prefill_alloc_workspace(q, v, **flags)      # 可按 shape+flags 缓存

out, final_state = aiter.ck_gdn_prefill(q, k, v, g, beta, ws, **flags)
# out        [T, HV, 128] bf16
# final_state[T 对应的 sequences, HV, 128, 128] fp32
```

### decode

```python
B, HQK, HV = 32, 2, 8
q = torch.randn(B, HQK, 128, dtype=dtype, device=dev) * 0.2
k = torch.randn(B, HQK, 128, dtype=dtype, device=dev) * 0.2
v = torch.randn(B, HV, 128, dtype=dtype, device=dev) * 0.2

a = torch.randn(B, HV, dtype=torch.float32, device=dev)        # raw gate
b = torch.randn(B, HV, dtype=torch.float32, device=dev)        # raw gate
A_log = -torch.rand(HV, dtype=torch.float32, device=dev) * 2.0
dt_bias = torch.randn(HV, dtype=torch.float32, device=dev) * 0.1
state = torch.randn(B, HV, 128, 128, dtype=torch.float32, device=dev) * 0.02

out, final_state = aiter.ck_gdn_decode(
    q, k, v,
    a,                        # g：gate_in_kernel 时传 raw gate
    torch.sigmoid(b),         # beta：CK 端要求已 sigmoid
    a_log=A_log,
    dt_bias=dt_bias,
    initial_state=state,
    cu_seqlens=torch.arange(B + 1, dtype=torch.int64, device=dev),
    scale=128 ** -0.5,
    use_g=True, gate_in_kernel=True, has_dt_bias=True,
    transpose_state=True, store_final_state=True,
)
```

## 3. 参数速查

### ck_gdn_prefill

| 参数 | 形状 / 类型 | 说明 |
|---|---|---|
| `q`、`k` | `[t, h_qk, 128]` fp16/bf16 | 必填 |
| `v` | `[t, h_v, 128]` fp16/bf16 | 必填 |
| `g` | `[t, h_v]` fp32 | `use_g=True`（默认）时必填 |
| `beta` | `[t, h_v]` fp32 | 必填；`beta_sigmoid_in_kernel=True` 时传原始值 |
| `workspace` | `uint8` 一维 | `None`（默认）则按同一组 flags 内部分配 |
| `gk` | `[t, h_v, 128]` fp32 | `use_gk=True` 时必填 |
| `a_log`、`dt_bias` | `[h_v]` fp32 | `gate_in_kernel=True` 时需要 `a_log` |
| `initial_state` | `[sequences, h_v, 128, 128]` fp32 | 可选 |
| `cu_seqlens` | `[sequences + 1]` int64 | packed varlen；单序列会被归一化为定长路径 |
| `scale` | `float` | `None` 或 0 → `1/sqrt(128)` |

布尔开关与默认值：`use_g=True`、`use_gk=False`、`use_exp2=True`、
`transpose_state=False`、`qk_l2norm=False`、`gate_in_kernel=False`、
`has_dt_bias=False`、`beta_sigmoid_in_kernel=False`、`output_final_state=True`、
`cp_context=False`、`cp_world_size=2`、`cp_rank=1`。

### ck_gdn_decode

| 参数 | 形状 / 类型 | 说明 |
|---|---|---|
| `q`、`k` | `[tokens, h_qk, 128]` fp16/bf16 | 必填 |
| `v` | `[tokens, h_v, 128]` fp16/bf16 | 必填 |
| `g` | `[tokens, h_v]` | 必填；dtype 由张量决定（fp16/bf16/fp32） |
| `beta` | `[tokens, h_v]` | 必填；**已做 sigmoid**（decode 没有 in-kernel sigmoid 开关） |
| `gk`、`gv` | `[tokens, h_v]` | 可选 |
| `a_log`、`dt_bias` | `[h_v]` | `gate_in_kernel=True` 时需要 `a_log` |
| `initial_state` | `[sequences, h_v, 128, 128]` fp32 | 可选；CK 不会原地改写它 |
| `cu_seqlens` | `[sequences + 1]` int64 | 缺省时整段视为一条序列 |
| `scale` | `float` | `None` 或 0 → `1/sqrt(128)` |

布尔开关与默认值：`use_g=True`、`use_gk=False`、`use_gv=False`、
`beta_headwise=True`、`use_qk_l2norm=False`、`use_exp2=False`、
`transpose_state=False`、`gate_in_kernel=False`、`has_dt_bias=False`、
`store_final_state=True`、`validate_varlen=True`。

### 三条通用约定

- 输入是 **packed 布局，没有 batch 维**；head_dim 固定 128，chunk size 固定 64；
- prefill 要求 `h_v / h_qk ∈ {1, 2, 4}`；decode 只要求 `h_v` 是 `h_qk` 的整数倍
  （仓库验证的比例同样是 1 / 2 / 4）；
- 所有张量必须连续、在同一设备上；`cu_seqlens` 必须是 **int64**。

## 4. 典型用法

### 4.1 workspace：分配、复用、重新 sizing

```python
flags = dict(use_g=True, use_exp2=False, transpose_state=True)
ws = aiter.ck_gdn_prefill_alloc_workspace(q, v, **flags)   # 缓存起来，跨层/跨步复用
```

- `ck_gdn_prefill_workspace_bytes` 与 `ck_gdn_prefill` 用**同一套** shape+flags
  推导，正常不会不一致；
- 传进去的 workspace 太小会直接报错（提示用 size 接口重新计算或传 `None`）；
- **shape 或任一 flag 变化（含 `output_final_state`、`transpose_state`、
  `qk_l2norm`、`beta_sigmoid_in_kernel` 等）都要重新 sizing**；
- 想省事可以传 `workspace=None`，适配器按同一组 flags 现分配（每次调用都有分配开销）。

workspace 里最大的一块是 chunk 中间量 `H`（每 chunk 每 value head 32 KiB），
所以它的开销随 `t` 和 `h_v` 线性增长。以 `t=4096、h_qk=2、h_v=8` 为例，
`H` 约 16 MiB。

### 4.2 varlen prefill

```python
cu = torch.tensor([0, 1024, 3072], dtype=torch.int64, device=dev)   # 两条序列
flags = dict(use_g=True, use_exp2=False)
ws = aiter.ck_gdn_prefill_alloc_workspace(q, v, cu, **flags)
out, final_state = aiter.ck_gdn_prefill(
    q, k, v, g, beta, ws, cu_seqlens=cu, **flags
)
```

- `cu_seqlens` 只在 varlen 时传；单序列传进去也等价于定长路径；
- 有 `cu_seqlens` 时 `initial_state` / `final_state` 的第一维是序列数
  （这里是 2），不是 1。

### 4.3 packed decode：与 state pool 的 gather / scatter

CK 没有 state pool 索引参数，需要调用方自己搬：

```python
slots = torch.tensor([3, 1, 7], dtype=torch.int64, device=dev)   # 框架给出的 pool slot
init = state_pool.index_select(0, slots).clone()                 # gather

out, final_state = aiter.ck_gdn_decode(
    q, k, v, a, torch.sigmoid(b),
    a_log=A_log, dt_bias=dt_bias,
    initial_state=init,
    cu_seqlens=torch.arange(B + 1, dtype=torch.int64, device=dev),
    scale=scale, use_g=True, gate_in_kernel=True, has_dt_bias=True,
    transpose_state=True,
)

state_pool.index_copy_(0, slots, final_state)                    # scatter
```

要点：

- `initial_state` 是只读输入，CK 返回**新的** `final_state` 张量，要自己写回 pool；
- `transpose_state=True` 时 CK 的稠密 state 与 HIPC/Triton 的 pool 布局逐元素一致，
  可以直接 gather/scatter（仓库测试与基准就是这么用的）；
- 定长多 batch 用等长分段表达：`cu_seqlens = arange(0, B*T_per_seq + 1, T_per_seq)`。

### 4.4 多 token 的序列更新

一次调用可以覆盖多条序列的多个 token，只要把 q/k/v 展平成 `[tokens, heads, 128]`：

```python
num_reqs, seq_len = 8, 8
T = num_reqs * seq_len
cu = torch.arange(0, T + 1, seq_len, dtype=torch.int64, device=dev)

# q/k/v reshape 成 [T, HQK/HV, 128]；g=a、beta=sigmoid(b) 同样 reshape 成 [T, HV]
init = base_pool.index_select(0, first_slots).clone()   # 每条序列取一个初始 slot
out, final_state = aiter.ck_gdn_decode(
    q2, k2, v2, a2, beta2,
    a_log=A_log, dt_bias=dt_bias,
    initial_state=init, cu_seqlens=cu, scale=scale,
    gate_in_kernel=True, has_dt_bias=True,
    transpose_state=True, store_final_state=True,
)
```

### 4.5 beta / gate 的三种喂法

| 喂法 | `g` | `beta` | 开关 |
|---|---|---|---|
| 全部预处理（最直接） | 已算好的 log 衰减 | 已 sigmoid | 默认 |
| kernel 内算 gate（对齐 HIPC） | HIPC 的 raw `a` | 已 sigmoid | `gate_in_kernel=True`、`a_log=`、`has_dt_bias=True` 时再加 `dt_bias=` |
| kernel 内算 beta（仅 prefill） | 已算好的 log 衰减 | 原始值 | `beta_sigmoid_in_kernel=True` |

`use_exp2` 决定 `g` 的底：`True` 表示 log2，`False` 表示自然对数。
从 HIPC/Triton 迁过来时保持 `use_exp2=False`。

decode 侧 aiter 只暴露了已 sigmoid 的 beta 入口，raw beta 的 CK launcher 没有接线，
所以 decode 一定要自己 `torch.sigmoid(b)`。

### 4.6 state 布局与 CK 的 fast path

`transpose_state` 控制 state 的存储方向：

- 默认 `False` 用 CK 自己的默认布局；
- 与 HIPC/Triton 的 state pool 对齐时用 `True`（本仓库测试与基准都这样用）。

CK 会根据 dtype 和 flags 自己挑实例，适配器不参与。想让 decode 命中 CK 的
raw-gate fast path，需要：`gate_in_kernel=True`、`has_dt_bias=True`、
`transpose_state=True`、`use_exp2=False`，且 **gate / dt_bias 用输入 dtype
（bf16/fp16）、`a_log` 与 beta 保持 fp32**。用 fp32 gate 也能算，只是走通用路径。

### 4.7 关掉 varlen 校验（去掉每次调用的 host 同步）

decode 入口默认会把 `cu_seqlens` 拷回 host 做合法性校验，这是一次**同步 D2H**：
在 events 口径下，它会给每次调用平白加上十几到几十微秒，并让 GPU 在校验期间空转。

```python
out, final_state = aiter.ck_gdn_decode(
    q, k, v, a, torch.sigmoid(b), cu_seqlens=cu, validate_varlen=False, **kw
)
```

- 生产路径（`cu_seqlens` 由框架维护、已知合法）应当关掉它；
- kernel 始终在 device 上读 `cu_seqlens`，关掉只影响校验：实测开关两路**逐位一致**，
  非法的 `cu_seqlens` 在关闭校验时不再被拦截（由调用方负责）；
- 基准脚本对应 `--no-validate-varlen`；
- prefill 入口的 host 读取是为了算 `num_chunks`（决定 workspace 大小），没有等价开关。

## 5. 与仓库内 HIPC GDN 的用法区别

HIPC 入口在 `aiter/ops/fla.py`（`module_cpp_api`），CK 入口在 `aiter/ops/ck_gdn.py`
（`module_gdn_ck`）。

### 5.1 入口对照

| 用途 | HIPC | CK |
|---|---|---|
| prefill（分阶段） | `chunk_gated_delta_rule_fwd_kkt_solve_hip`、`chunk_gated_delta_rule_fwd_vllm_hip_blockdim64`、`chunk_gated_delta_rule_fwd_sglang_hip_blockdim64`、`chunk_fwd_o_vllm_hip_blockdim64` | `ck_gdn_prefill`（一次调用跑完全部阶段） |
| decode（vLLM 序列更新） | `vllm_fused_sigmoid_gating_delta_rule_update` | `ck_gdn_decode` |
| decode（packed 单算子） | `aiter_fused_recurrent_gated_delta_rule_packed_decode` | `ck_gdn_decode` |
| 兼容别名 | `chunk_gated_delta_rule_fwd`、`chunk_gated_delta_rule_fwd_sglang` | 无 |

### 5.2 关键差异

| 维度 | HIPC | CK |
|---|---|---|
| 粒度 | 分阶段算子：KKT/solve、w/u 递推、output 分开；`w`/`u` 要调用方（或 Triton 侧）先准备好 | 整算子：prefill 从原始 q/k/v/g/beta 一路算完 |
| 输入组织 | packed decode 收拼接好的 `mixed_qkv` | 收分离的 `q`/`k`/`v`（各自 packed） |
| gate / beta | 收 raw `a`、`b`，配 `A_log`/`dt_bias` 在 kernel 内完成；`threshold`、`beta` 是算子参数 | `g` 是衰减（`gate_in_kernel=True` 时才是 raw gate）；beta 默认要自己 sigmoid |
| state | 用 `ssm_state_indices` 索引 state pool，**原地更新** | 无索引；稠密 `[sequences, h_v, 128, 128]`，gather/scatter 自己做，返回新张量 |
| 输出 | packed decode 需要预分配 `out` | 内部创建并返回 `output` |
| 中间量 | 可返回 `h`/`v_new`（`save_new_value` 控制） | 不返回，全部留在 workspace 里（`v_new` 恒定物化） |
| workspace | 没有 | prefill 需要，按 shape+flags 计算 |
| varlen 元数据 | `cu_seqlens` int32/int64 均可，`chunk_indices`/`chunk_offsets` 可由 Python 侧自动补齐 | 只收 int64 `cu_seqlens`，chunk 元数据在 workspace 内生成 |
| 其它开关 | `threshold`、`num_accepted_tokens`、`is_kda`、`inplace_final_state` 等 | 无对应参数 |
| 默认 `use_exp2` | `False` | prefill `True`，decode `False` |
| 后端回退 | 无 | 无 |

### 5.3 同一份数据的两种写法

```python
mixed_qkv = torch.cat([
    q.reshape(B, HQK * 128), k.reshape(B, HQK * 128), v.reshape(B, HV * 128),
], dim=-1).contiguous()
a = torch.randn(B, HV, dtype=torch.float32, device=dev)
b = torch.randn(B, HV, dtype=torch.float32, device=dev)
A_log = -torch.rand(HV, dtype=torch.float32, device=dev) * 2.0
dt_bias = torch.randn(HV, dtype=torch.float32, device=dev) * 0.1
pool = torch.randn(P, HV, 128, 128, dtype=torch.float32, device=dev) * 0.02
indices = torch.arange(B, dtype=torch.int32, device=dev)
scale = 128 ** -0.5

# --- HIPC：raw gate，state pool 原地更新，out 预分配 ---
out_hipc = torch.empty(B, 1, HV, 128, dtype=dtype, device=dev)
aiter.aiter_fused_recurrent_gated_delta_rule_packed_decode(
    mixed_qkv=mixed_qkv, a=a, b=b, A_log=A_log, dt_bias=dt_bias,
    scale=scale, initial_state=pool, out=out_hipc,
    ssm_state_indices=indices, use_qk_l2norm_in_kernel=False,
)                                  # pool 已被写回；out_hipc[:, 0] 是输出

# --- CK：beta 先 sigmoid，state 手工 gather/scatter ---
slots = indices.to(torch.int64)
ck_state = pool.index_select(0, slots).clone()
ck_out, ck_final = aiter.ck_gdn_decode(
    q, k, v, a, torch.sigmoid(b),
    a_log=A_log, dt_bias=dt_bias,
    initial_state=ck_state,
    cu_seqlens=torch.arange(B + 1, dtype=torch.int64, device=dev),
    scale=scale, use_g=True, gate_in_kernel=True, has_dt_bias=True,
    transpose_state=True, store_final_state=True,
)
pool.index_copy_(0, slots, ck_final)
```

两者的 `out` 形状不同：HIPC packed decode 是 `[B, 1, HV, V]`，CK 是 `[B, HV, V]`。
`transpose_state=True` 保证 CK 的 state 与 pool 可以逐元素对齐。

### 5.4 从 HIPC 切换到 CK：步骤、示例与验收

CK 不是 drop-in 替代，切换是有明确映射的改写。按下面五步走；能/不能对齐的边界见 5.5。

#### 5.4.1 先归类场景

| 你原来用的是 | 现在换成 | 改造量 |
|---|---|---|
| `aiter_fused_recurrent_gated_delta_rule_packed_decode`（1 token/序列） | `ck_gdn_decode` | 小：改 beta/gate/state 三处契约 |
| `vllm_fused_sigmoid_gating_delta_rule_update`（框架 update，含投机解码） | `ck_gdn_decode` | 中：额外要处理 `num_accepted_tokens` 片段语义 |
| `chunk_gated_delta_rule_fwd_*` + `chunk_fwd_o_*`（分阶段 prefill） | `ck_gdn_prefill` 单算子 | 大：框架侧前处理要删掉，并新增 workspace 管理 |

#### 5.4.2 输入契约改写表

| 项 | HIPC | CK 改成 |
|---|---|---|
| `beta` | raw `b` | `torch.sigmoid(b)`（decode）；prefill 可用 `beta_sigmoid_in_kernel=True` 传原始值 |
| gate | raw `a` + `A_log`/`dt_bias` | `g=a` 且 `gate_in_kernel=True`，有 bias 再 `has_dt_bias=True` |
| state | `initial_state` 池 + `ssm_state_indices`，原地更新 | `index_select` gather 成稠密 `[sequences, hv, 128, 128]`；`transpose_state=True` 与池布局对齐；调用后 `index_copy_` 写回 |
| `cu_seqlens` | int32 或 int64 | **int64** |
| q/k/v | `mixed_qkv` 拼接张量，或 `[B, T, H, D]` | 分离的 `q`/`k`/`v`，`[tokens, heads, 128]` 连续（由 `mixed_qkv` 切出来需要一次 `.contiguous()`） |
| 输出 | 预分配 `out=[B,1,hv,V]` | CK 返回 `[tokens,hv,V]` 与新的 `final_state`；形状少一维 |
| 其它开关 | `threshold`、`beta`(float)、`num_accepted_tokens`、`is_kda`、`inplace_final_state` | CK 无对应参数，需要调用方承担（见 5.4.4） |
| `use_exp2` | `False` | 保持 `False` |

decode 生产路径额外加 `validate_varlen=False`（去掉每次调用的 D2H 同步，见 4.7）。

#### 5.4.3 before / after

**decode（1 token/序列）**

```python
# before: HIPC
out = torch.empty(B, 1, HV, 128, dtype=dtype, device=dev)
aiter.aiter_fused_recurrent_gated_delta_rule_packed_decode(
    mixed_qkv=mixed_qkv, a=a, b=b, A_log=A_log, dt_bias=dt_bias,
    scale=scale, initial_state=pool, out=out,
    ssm_state_indices=indices, use_qk_l2norm_in_kernel=False,
)

# after: CK
slots = indices.to(torch.int64)
out, new_state = aiter.ck_gdn_decode(
    q, k, v, a, torch.sigmoid(b),
    a_log=A_log, dt_bias=dt_bias,
    initial_state=pool.index_select(0, slots).clone(),
    cu_seqlens=torch.arange(B + 1, dtype=torch.int64, device=dev),
    scale=scale, use_g=True, gate_in_kernel=True, has_dt_bias=True,
    transpose_state=True, store_final_state=True,
    validate_varlen=False,
)
pool.index_copy_(0, slots, new_state)
```

**框架 update（`vllm_fused_sigmoid_gating_delta_rule_update`）**：改写同上，但要注意
不要直接照搬 `q/k/v` 的 4-D 形状与 per-token 索引：

- HIPC 收 `q/k/v = [1, T, H, D]`，CK 收 `[T, H, D]`；
- HIPC 的 `a`/`dt_bias` 是输入 dtype、`b` 是输入 dtype，CK 侧 `a`/`dt_bias` 保持输入 dtype、
  `beta` 传 fp32（`torch.sigmoid(b.float())`），这样才能命中 CK 的 raw-gate fast path。

**prefill（分阶段链 → 单算子）**

```python
# before: HIPC 三段 + Triton 的 cumsum / recompute_w_u
h      = aiter.chunk_gated_delta_rule_fwd_vllm_hip_blockdim64(k, w, u, ...)
o      = aiter.chunk_fwd_o_vllm_hip_blockdim64(q, k, v, h, ...)
# A / w / u 由框架侧（Triton）另外算好

# after: CK 一次调用；A/W/U/H/v_new 全部在 workspace 内部
flags = dict(use_g=True, use_exp2=False, transpose_state=True)
ws = aiter.ck_gdn_prefill_alloc_workspace(q, v, **flags)      # 按 shape+flags 缓存
out, final_state = aiter.ck_gdn_prefill(q, k, v, g, beta, ws, **flags)
```

#### 5.4.4 框架侧要删掉 / 要补上 / 不要混用

- **删掉**：为 HIPC 准备的前处理——cumsum、KKT/solve、W/U 重算（Triton `recompute_w_u_fwd`）、
  `chunk_indices`/`chunk_offsets` 构造、H 的布局适配。CK 内部全部重做，留着会重复计算。
- **补上**：prefill 的 workspace 分配与缓存（按 shape + flags）。
- **不要混用中间量**：CK 的 `H`/`W`/`U`/`v_new` 是内部中间量，不导出且布局有内部约定
  （见 CK 文档 §3 关于 packed H 的说明），不能喂给 HIPC/Triton 的 output 阶段；反过来也不行。
- **需要调用方承担的两个语义**：
  - 投机解码的 `num_accepted_tokens`：HIPC 的 kernel 从 `num_accepted[n]-1` 个 token 开始，
    跳过被拒的草稿 token；CK 会处理你给它的**每一个** token，所以要么按接受的 token
    重新构造 packed 输入与 `cu_seqlens`，要么自己在 Python 侧选片段；
  - `threshold` / `is_kda` / `inplace_final_state`：CK 无对应参数，语义要在框架层实现
    （`inplace_final_state=False` 的等价物本来就是 CK 的默认行为——它不改写 `initial_state`）。

#### 5.4.5 验收与回滚

```bash
# 功能 + 与 HIPC 对拍（24 项）
PYTHONPATH=. python -m pytest -q op_tests/test_ck_gdn_native.py

# 数值对拍：同一份输入分别跑 HIPC 与 CK，比 out / final_state
PYTHONPATH=. python op_tests/op_benchmarks/bench_ck_gdn_native.py \
    --mode decode --hipc-op vllm-update --no-validate-varlen

# 性能（文档口径）
bash bench_gdn.sh ck-decode-doc
```

- 容差沿用 CK 自身脚本量级：bf16 `3e-2`、fp16 `2e-2`；
- **回滚**：HIPC 入口仍在 `aiter/ops/fla.py`，两套入口并存、没有自动回退，切回去只要改回调用即可；
  不需要卸载或重编 `module_gdn_ck`（JIT 缓存保留）。

### 5.5 能不能和 HIPC 用法完全对齐

**结论：语义可以对齐，API 形状不能完全对齐。** 按代价分三类。

**A. 写法不同、但语义等价（照 5.3 写即可）**

| 项 | HIPC | CK 等价写法 |
|---|---|---|
| gate | raw `a` + `A_log`/`dt_bias`，kernel 内算 | `g=a`、`gate_in_kernel=True`（有 bias 再加 `has_dt_bias=True`） |
| state 布局 | pool `[P, hv, V, K]` | `transpose_state=True` 后逐元素一致 |
| varlen | `cu_seqlens` int32 或 int64 | `cu_seqlens`，**必须是 int64** |
| `scale` | 缺省 `1/sqrt(D)` | 省略或传 0 → 同一默认值 |
| 返回 | `(out, final_state)` | 同 |

**B. 用薄封装即可对齐（不必改 C++）**

| 项 | 差距 | 对齐办法 |
|---|---|---|
| 输入组织 | HIPC 收拼接好的 `mixed_qkv` | `mixed_qkv` 的切片可以 `view` 出 q/k/v 形状（零拷贝），但切片**不连续**（`stride[0]` 仍是整行宽度），不满足 CK 的连续性校验，需要一次 `.contiguous()` 拷贝；上游直接给分离张量时没有这份开销 |
| beta | HIPC 收 raw `b`，kernel 内 sigmoid | 调用方 `torch.sigmoid(b)`（多一个 elementwise kernel） |
| state pool | HIPC 用 `ssm_state_indices` 且原地更新 | 封装 gather → 调用 → scatter（见 4.3） |
| 输出缓冲 | HIPC 由调用方预分配 `out` | 目前只能让 CK 内部创建；要复用缓冲需要 C++ 侧支持 |

**C. 结构性差异，封装无法消除**

| 项 | 说明 |
|---|---|
| 粒度 | HIPC prefill 是分阶段算子（收 `w`/`u`、返回 `h`/`v_new`）；CK prefill 是一条整流水线。CK 的分阶段 launcher 没有暴露到 aiter |
| 参数面 | HIPC 的 `threshold`、`beta`（float）、`num_accepted_tokens`、`is_kda`、`inplace_final_state` 在 CK 侧没有对应物 |
| beta 融合 | CK 有 `launch_bf16/fp16_raw_beta`（kernel 内 sigmoid），但适配器没有接线，所以 CK 侧必须自己 sigmoid |
| varlen 元数据 | HIPC 接受 int32/int64，且 `chunk_indices`/`chunk_offsets` 可在 Python 侧自动补齐；CK 只收 int64，chunk 元数据在 workspace 内生成 |
| prefill 的 host 读取 | CK prefill 需要 `cu_seqlens` 的 host 值算 `num_chunks`（决定 workspace 大小），没有关闭开关；decode 侧已可用 `validate_varlen=False` 消除 |

也就是说：**从 HIPC 迁到 CK 是一次有明确映射的改写（5.3 / 5.4），CK 不是 HIPC 的 drop-in 替代。**
要真正做到"用法完全对齐"，需要给适配器补三件事：raw-beta launcher 接线、`out=` 输出复用、
`ssm_state_indices` / `num_chunks` 直传（或接受 CPU 侧 `cu_seqlens`）。三项都不难，但都会改动
C++/pybind 的 API 面，需要单独排期。

## 6. 验证与基准

```bash
# 功能：sizing/参数校验、CK prefill vs decode 自一致、CK vs HIPC vs Triton
PYTHONPATH=. python -m pytest -q op_tests/test_ck_gdn_native.py

# 基准：CK vs HIPC（decode / update / prefill）
PYTHONPATH=. python op_tests/op_benchmarks/bench_ck_gdn_native.py --mode decode
bash bench_gdn.sh ck              # ck-prefill + ck-decode
bash bench_gdn.sh ck-prefill      # 只跑 CK prefill 管线
bash bench_gdn.sh ck-decode       # 只跑 CK decode 与 HIPC 对比
bash bench_gdn.sh ck-decode-doc   # CK decode，CK 文档口径（Graph + vllm-update + VK/raw-gate）
```

常用开关：

| 开关 | 作用 |
|---|---|
| `--hipc-op {packed-decode,vllm-update}` | 选 HIPC 对照算子（默认 `packed-decode`；`vllm-update` 才是 CK 文档的对照） |
| `--graph` | GPU Graph 计时：不含 host/JIT/分配开销、固定初态、无复位拷贝；强制 `validate_varlen=False` |
| `--graph-calls/-samples/-replays` | 每图捕获调用数（16）、采样轮次（7）、每样本回放次数（5） |
| `--gate-dtype {f32,bf16,fp16}` | gate/dt_bias 的 dtype；bf16/fp16 让 CK 命中 raw-gate fast path |
| `--no-validate-varlen` | 跳过 CK 的 host 侧 `cu_seqlens` 校验（去掉每次调用的 D2H 同步，见 4.7） |

- 第一次调用会 JIT 编译 `module_gdn_ck`（较慢），**先预热再计时**；
- 用公开 API（非 Graph）计时时务必带 `--no-validate-varlen`，否则测的是 D2H 同步；
- 容差沿用 CK 自身脚本量级：bf16 `3e-2`、fp16 `2e-2`。

### 6.1 性能对比口径（读数字前先确认这几件事）

CK 侧的性能数据见
[`3rdparty/composable_kernel/docs/ops/ck_gdn.md`](../3rdparty/composable_kernel/docs/ops/ck_gdn.md)：
它用 GPU Graph 计时（每图 16 次调用、7 轮、等权中位数），**不含 JIT、host 分配和
Python 调用开销**，计时时固定初态且不回灌输出；decode 对照的是 HIPC
`vllm_fused_sigmoid_gating_delta_rule_update`，口径为 VK state + raw gate。

本仓库的 `bench_ck_gdn_native.py --mode decode` 与之有两处口径差异，读结论时要区分：

- **对照算子不同**：它对照 `aiter_fused_recurrent_gated_delta_rule_packed_decode`
  （1 token/序列的专用 kernel），不是 doc 里那个通用 update 算子；
- **计时范围不同**：它把 host 开销和每次迭代的 state 复位拷贝都算进去
  （B=128、H=16/HV=64 时复位拷贝本身就有几百微秒量级），CK 适配器的 host 开销因此会被放大。

其余注意点：

- 用公开 API 计时务必 `validate_varlen=False`（见 4.7），否则每次调用的 D2H 同步会计入；
- 速度依赖 state 布局与 gate 契约：`transpose_state=True`（VK 布局）+ `gate_in_kernel`/
  `has_dt_bias` + 输入 dtype 的 gate/dt_bias 才命中快速路径，KV 布局明显更慢；
- 绝对耗时与设备 SKU 相关（CU 数不同），跨设备不要直接比较。

想直接复现文档口径，用基准脚本的两个开关（或 `bash bench_gdn.sh ck-decode-doc`）：

```bash
PYTHONPATH=. python op_tests/op_benchmarks/bench_ck_gdn_native.py \
    --mode decode --batch 32 --heads 16 --value-heads 64 \
    --gate-dtype bf16 --hipc-op vllm-update --graph
```

`--hipc-op vllm-update` 把对照换成文档使用的 `vllm_fused_sigmoid_gating_delta_rule_update`，
`--graph` 切到 GPU Graph 计时（不含 host 开销、固定初态，并强制 `validate_varlen=False`，
因为 D2H 无法被捕获）。在 BW1100/gfx938（72 CU）上该命令的实测与文档 gfx938 表一致（完整数据见 6.2）。

### 6.2 实测数据（2026-10-07，BW1100 / gfx938，72 CU）

除特别说明外：bfloat16、每序列 1 token、VK state、raw gate 用输入 dtype、
`a_log`/`beta` fp32、`gate_in_kernel + has_dt_bias`。单位微秒，越小越好。

数据基线：分支提交 `40cd2695`（基于 `origin/ck-gdn`，含 main `f9b9c844`），
`module_gdn_ck` 在该基线上重新编译。rebase + 重编后抽测了本表的
B=8/H2/HV8、B=32/H16/HV64 与 prefill t=9008 三个点，结果全部复现（偏差 <0.1%）；
同基线上的 GDN 正确性回归也全绿（CK GDN 24/24、HIPC GDN 445/445）。

**表 1：文档口径（GPU Graph）vs HIPC `vllm_fused_sigmoid_gating_delta_rule_update`**

| B | H / HV | CK | HIPC | CK 领先 | CK 文档 gfx938（CK / HIPC） |
|---:|---|---:|---:|---:|---|
| 1 | 2 / 8 | 4.5 | 4.7 ~ 5.3 | 接近 | 4.305 / 4.151（接近） |
| 8 | 2 / 8 | 8.2 | 8.9 | 1.09x | 8.498 / 9.032 |
| 32 | 2 / 8 | 26.3 | 44.6 | 1.70x | 27.795 / 47.226 |
| 128 | 2 / 8 | 85.3 | 405 | 4.75x | 87.901 / 390.532 |
| 1 | 16 / 64 | 9.2 | 10.1 | 1.10x | 8.509 / 8.994 |
| 8 | 16 / 64 | 45.9 | 87.8 | 1.91x | 48.040 / 102.646 |
| 32 | 16 / 64 | 167.1 | 686.5 | 4.11x | 167.843 / 696.900 |
| 128 | 16 / 64 | 655.6 | 4532 | 6.91x | 666.075 / 4004.539 |

**表 2：同口径，换成 HIPC 的 1-token 专用 packed kernel**

| B | H / HV | CK | HIPC packed | 结论 |
|---:|---|---:|---:|---|
| 1 | 2 / 8 | 4.5 | 7.1 | CK 快 1.60x |
| 8 | 2 / 8 | 8.3 | 9.4 | CK 快 1.14x |
| 32 | 2 / 8 | 26.3 | **21.2** | **HIPC 快 1.24x** |
| 128 | 2 / 8 | 85.3 | 84.5 | 持平 |
| 1 | 16 / 64 | 8.3 | 9.5 | CK 快 1.15x |
| 8 | 16 / 64 | 45.9 | **42.7** | HIPC 快 1.08x |
| 32 | 16 / 64 | 167.2 | 167.6 | 持平 |
| 128 | 16 / 64 | 655.7 | 665.7 | CK 快 1.5% |

换用专用 packed kernel 后，大 batch 基本持平、中小 batch HIPC 局部反超。
"CK 大幅领先"针对的是通用 update 算子，不能外推到所有 HIPC 入口。

**表 3：fp16（Graph，vllm-update）**

| B | H / HV | CK | HIPC | CK 领先 | CK 文档 gfx938（CK / HIPC） |
|---:|---|---:|---:|---:|---|
| 32 | 2 / 8 | 26.1 | 44.8 | 1.72x | 27.717 / 47.607 |
| 128 | 2 / 8 | 85.1 | 403.9 | 4.75x | 87.586 / 373.375 |
| 32 | 16 / 64 | 168.9 | 693.8 | 4.11x | 167.623 / 712.372 |
| 128 | 16 / 64 | 666.9 | 4511.2 | 6.76x | 664.805 / 3968.250 |

**表 4：公开 API 口径（event 计时，含 host 开销与复位拷贝，`validate_varlen=False`）**

| B | H / HV | CK | HIPC | 结论 |
|---:|---|---:|---:|---|
| 32 | 2 / 8 | 79 ~ 81 | 80 | 持平 |
| 128 | 2 / 8 | 187.0 | 503.4 | CK 快 2.69x |
| 32 | 16 / 64 | 360.8 | 881.2 | CK 快 2.44x |
| 128 | 16 / 64 | 1407.7 | 5289.2 | CK 快 3.76x |

关掉 varlen 校验后，公开 API 也不再被适配器的 D2H 拖累（对比修复前同 shape
的 `--validate` 默认值：B=32/2/8 从 113.6 降到 ~80，B=128/16/64 从 1468 降到 1408）。

**prefill（CK 单算子全流水线，公开 API 口径）**：t=9008、H2/HV8 →
**1531.7 us**；t=9008、H16/HV64 → **3621.3 us**。HIPC 侧没有同粒度的单算子
（只有 `fwd_h` 阶段，同 shape 约 325 us），不能直接比。

**重复性与已知计时坑**：

- 表 1~3 的关键档位重复 3 次，波动 <1%（如 B=128/H2/HV8 的 CK：85.33 / 85.34 / 85.35）；
- Graph 计时必须把 event 记在**捕获流**上（脚本已按此实现）：记在当前流会跨时钟域读数，
  出现负值或 239.9 us 这种固定假值；
- event 口径曾出现一次整轮 ~19.18 ms 的假读数（两臂同时，= 80×239.9us），重跑不复现，
  当时设备空闲；所以结论以 `--graph` 为准，event 口径只作参考。

## 7. 限制速查

- `head_dim == 128`、chunk size 固定 64，输入必须 packed、连续、同 dtype；
- 只有 bf16 / fp16 输入；decode 的 `g`/`beta` 可以单独是 fp32；
- prefill 需要 workspace，且必须与 shape+flags 绑定；
- decode 没有 state pool 索引，gather/scatter 由调用方负责；
- CK 不是 HIPC 的 drop-in 替代：迁移按 5.4，能/不能对齐的边界见 5.5；
- `use_gk`（per-key 路径）与 `cp_context` 互斥，且该路径以功能正确性为目标；
- `cp_context` 是 CK 侧的单进程功能模拟（不建真实进程、不调 RCCL），仅用于验证
  multi-rank payload、内存布局与 merge 逻辑，性能未优化。

## 代码索引

- [Python 公开接口](../aiter/ops/ck_gdn.py)
- [prefill 适配器](../csrc/ck_gdn/ck_gdn_prefill.cpp)、[decode 适配器](../csrc/ck_gdn/ck_gdn_decode.cpp)
- [workspace 布局](../csrc/ck_gdn/ck_gdn_common.h)、[pybind 表面](../csrc/pybind/ck_gdn_pybind.cpp)
- [功能测试](../op_tests/test_ck_gdn_native.py)、[基准脚本](../op_tests/op_benchmarks/bench_ck_gdn_native.py)
- [HIPC 入口（aiter/ops/fla.py）](../aiter/ops/fla.py)
- [CK example 实现与历史性能表](../3rdparty/composable_kernel/example_hcu/ck_tile/21_gdn/README.md)
