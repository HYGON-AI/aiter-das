# FLA HIP BV32 kernel analysis and BV64 design notes

> Status: BV32 and the targeted gfx938 BV64 LDS32 path are implemented. The
> older 28 KiB two-V32-pass design is retained below as design history; section
> 18 is the current production contract.
>
> Scope: `K=128`, `V=128`, `BT=64`, four AMD wave64s per CTA, fp16/bf16
> matrix operands, and FP32 state/MMAC accumulation.

本文档固化当前对 FLA HIP `chunk_gated_delta_rule_fwd` 的分析，主要用于：

1. 解释当前 BV32 kernel 的数学语义、线程 ownership、LDS 布局和流水线；
2. 记录 BV64 的访存收益、LDS 预算和推荐实现方式；
3. 为后续实现、review、性能分析和数值验证提供共同基线。

## 1. Source map

| 文件 | 作用 |
|---|---|
| [`../chunk_gated_delta_rule_fwd.cu`](../chunk_gated_delta_rule_fwd.cu) | ATen 参数检查、runtime dispatch、BV16/BV32 选择 |
| [`../include/fla_fwd_launch_template.h`](../include/fla_fwd_launch_template.h) | 模板 dispatch、grid/block 和动态 LDS launch |
| [`../include/fla_fwd_kernel.h`](../include/fla_fwd_kernel.h) | BV16/BV32 kernel body、chunk pipeline、两次 MMAC |
| [`../include/kernel_traits.h`](../include/kernel_traits.h) | tile 常量、线程数和 LDS 大小 |
| [`../include/utils.h`](../include/utils.h) | LDS swizzle、D2L、fragment shuffle、state load/store |
| [`../include/arch.h`](../include/arch.h) | MMAC/DS builtin、VMEM waitcnt 和 barrier helper |
| [`../include/block_info.h`](../include/block_info.h) | varlen offset、chunk 数和 state slot 映射 |
| [`../../../aiter/ops/triton/fla/sglang/chunk_delta_h.py`](../../../aiter/ops/triton/fla/sglang/chunk_delta_h.py) | SGLang Triton reference |

主要入口符号：

```text
chunk_gated_delta_rule_fwd_kernel
  -> run_chunk_gated_delta_rule_fwd_kernel_body
    -> run_chunk_gated_delta_rule_fwd_kernel_body_bv64_lds32
      -> run_chunk_gated_delta_rule_fwd_chunk_bv64_lds32
    -> run_chunk_gated_delta_rule_fwd_kernel_body_bv32
      -> run_chunk_gated_delta_rule_fwd_chunk_bv32_mmac
```

## 2. Mathematical recurrence

对某个 `(sequence, head, V32)` CTA 和一个有效长度为 `L <= 64` 的
chunk，定义：

```text
H_c:  [32, 128]   chunk 开始前的 FP32 逻辑状态
W_c:  [L, 128]
K_c:  [L, 128]
U_c:  [L, 32]
```

当前 kernel 计算：

```text
H_low = cast<Element>(H_c)

P = W_c @ H_low^T
R_raw = fp32(U_c) - P

v_new = cast<Element>(R_raw)                    # 如果要求保存

row_scale[t] = exp(g[last] - g[t])              # 如果启用 G
R_gate[t] = R_raw[t] * row_scale[t]

Delta = cast<Element>(R_gate)^T @ K_c

state_scale[k] = 1
state_scale[k] *= exp(g[last])                   # 如果启用 G
state_scale[k] *= exp(gk[last, k])               # 如果启用 GK

H_{c+1}[v, k] = H_c[v, k] * state_scale[k] + Delta[v, k]
```

同时输出当前 chunk 更新前的低精度 state snapshot：

```text
h[chunk, v, k] = H_low[v, k]
```

重要精度边界：

- `state_reg` 在 chunk 之间保持 FP32；
- `h_low` 是 `state_reg` 转成 input Element 后的 LDS 镜像；
- GEMM0 的 W/H operand 为 fp16/bf16，C accumulation 为 FP32；
- residual 先在 FP32 中计算和乘 row gate，再转成 Element 写 `v_tile`；
- GEMM1 的 residual/K operand 为 fp16/bf16，C accumulation 为 FP32；
- `v_new` 保存 gate 之前的 raw residual。

`SafeNatural` 只用于 `g[last]-g[t]` 的 row scale。旧状态的 `g[last]`
和 `gk[last,k]` scale 使用非 safe exponent path。

## 3. Launch and CTA ownership

当前 launch 常量：

```text
K  = 128
V  = 128
BT = 64
BK = 128
BV = 32

waves/CTA   = 4
lanes/wave  = 64
threads/CTA = 256
```

Grid：

```text
grid.x = ceil(V / BV)
grid.y = N * H
```

一个 CTA 固定负责：

```text
(sequence i_n, query head i_h, V tile i_v)

V rows = [32*i_v, 32*i_v+31]
K cols = [0, 127]
T      = 该 sequence 的所有 chunk，CTA 内串行遍历
```

当前 `V=128` 时，每个 `(sequence, head)` 有 4 个 BV32 CTA。不同 CTA
更新不相交的 V rows，不需要跨 CTA 同步，但会重复读取相同的 W、K、G、GK。

GQA 下 query head `i_h` 使用的 K head 是：

```text
i_h / (H / Hg)
```

host 侧仅在以下条件成立时选择 BV32：

```text
ceil(V / 32) * N * H >= 48
```

当前 `V=128` 时等价于 `N*H >= 12`，否则走 BV16。

## 4. BV32 wave/lane ownership

对线程：

```text
w = warp_id = tid / 64                 in [0, 3]
m = lane_m  = lane_id & 15             in [0, 15]
g = lane_g  = lane_id >> 4             in [0, 3]

t_local = 16*w + m
k0      = 32*w + 2*m
k1      = k0 + 1
```

代码变量名是 `warp_id`，硬件执行单元实际为 AMD wave64。`lane_g` 是
MMAC lane group，不是 GQA group。

### 4.1 FP32 state ownership

每个线程持有：

```text
fla_f32x2 state_reg[8]
```

精确映射：

```text
state_reg[s][0] <-> H[v_begin + g + 4*s, k0]
state_reg[s][1] <-> H[v_begin + g + 4*s, k1]
s = 0..7
```

因此：

```text
thread:  8 V rows x K2 = 16 FP32 state elements
wave:    V32 x K32
CTA:     V32 x K128 = 4096 FP32 state elements
```

同一个 wave 在两次 GEMM 中承担不同角色：

```text
GEMM0: wave_id 选择 T16 output rows
GEMM1: wave_id 选择 K32 output cols
```

### 4.2 Residual ownership

同一线程的 U/residual ownership 是：

```text
t = t_begin + 16*w + m
v = v_begin + 8*g ... v_begin + 8*g + 7
```

这与 `state_reg` 的 stride-4 V ownership 不同。GEMM0 后的 projection
shuffle 和 GEMM1 的 accumulator layout 负责在这两种 ownership 之间转换。

## 5. BV32 LDS and VGPR residency

Element 为 fp16/bf16，即 2 bytes。当前 BV32 LDS：

| Buffer | 逻辑形状 | 大小 | 生命周期/用途 |
|---|---:|---:|---|
| `v_tile` | `[T64,V32]` | 4 KiB | 当前 chunk 的 gated residual，供 GEMM1 |
| `h_low` | `[V32,K128]` | 8 KiB | 低精度 state 镜像，供 GEMM0/snapshot |
| `K_tile` | `[T64,K128]` | 16 KiB | K direct-to-LDS，供 GEMM1 |
| total | | **28 KiB** | |

W 不进入 LDS：

```text
w_carried[4]: 当前/下一 chunk 的 W，VGPR
w_pack[4]:    当前 chunk GEMM0 使用的 W，VGPR
```

每个 `fla_u32x4` 保存 8 个 Element。每线程 4 个 W pack 共 32 个 W
元素。

`state_reg` 是权威状态；`h_low` 只是低精度镜像：

```text
                     +-- keep FP32 ----------------> next state update
state_reg (FP32) ----+
                     +-- cast Element -> h_low ----> GEMM0 / h snapshot
```

### 5.1 h_low swizzle

`h_low` 的逻辑形状是 `[V32,K128]`，物理地址经过 XOR swizzle。同一个
地址变换同时支持：

1. 按 state ownership 写入 Element2；
2. GEMM0 按 H operand layout 做 b128 读取；
3. snapshot 按连续 K8 读取并写回 GMEM。

当前 swizzle 中每个 K32 stripe 固定占 512 dwords，这是 BV32 专用常量；
直接把 V 扩到 64 会让相邻 K32 stripe 地址重叠。

## 6. Outer W carry pipeline

当前活跃 BV32 body 在进入第一个 chunk 前加载 W0：

```text
load W0 -> w_carried
wait W0
```

稳态调度：

```text
chunk 0: consume W0, prefetch W1
chunk 1: consume W1, prefetch W2
...
last:    consume carried W, no prefetch
```

线程 `(w,m,g)` 的 W stage `r` 坐标：

```text
W[t_begin + 16*w + m,
  32*r + 8*g : 32*r + 8*g + 8]
r = 0..3
```

helper 保留了 `WAlreadyCarried=false` 分支，但当前 outer body 调用的活跃路径
全部使用 `WAlreadyCarried=true`。

## 7. One BV32 chunk

### 7.1 GMEM issue order

当前 W 已在 VGPR。chunk 内首先按以下顺序发起请求：

```text
G -> U -> K direct-to-LDS
```

线程 `(w,m,g)` 的主要访存坐标：

| Tensor | 每线程坐标 |
|---|---|
| W stage `r` | `t=16*w+m`, `k=32*r+8*g ... +7` |
| U | `t=16*w+m`, `v=8*g ... +7` |
| G | `g[last]` 和 `g[t]`；在 `lane_g` 间重复 |
| K load `r` | `t=w+4*g+16*r`, `k=8*m ... +7` |
| GK | `gk[last,k0]` 和 `gk[last,k1]`；在 `lane_g` 间重复 |

K 每线程发起 4 个 b128 D2L load，整个 CTA 合作覆盖 `[T64,K128]`。
K 传输与 GEMM0 重叠。

### 7.2 GEMM0: projection

GEMM0 计算：

```text
P[T64,V32] = W[T64,K128] @ H_low[V32,K128]^T
```

每个 wave 计算 `[T16,V32]`。K128 分成 4 个 K32 stage。

H reader 的逻辑坐标：

```text
v = 2*m + parity
k = 32*k_stage + 8*g ... +7
parity = 0/1
```

所以：

```text
c_proj[0]: 偶数 V 的 16-column MMAC fragment
c_proj[1]: 奇数 V 的 16-column MMAC fragment
```

MMAC 结束后的精确 fragment 映射：

```text
c_proj[p][s] <-> P[t=16*w+m, v=2*(g+4*s)+p]
```

`fla_make_gemm0_projection_v4` 用 `ds_bpermute` 对四个 `lane_g` 做
4x4 transpose；再交织 even/odd 后，每线程得到：

```text
proj_lo = P[t, 8*g + 0..3]
proj_hi = P[t, 8*g + 4..7]
```

此时 projection 与 U 的连续 V8 ownership 对齐。

GEMM0 默认启用 H read-ahead：先发起下一个 K32 stage 的 H LDS read，再
执行当前 stage 的 MMAC。

### 7.3 Pre-update H snapshot

GEMM0 完成后、state 更新前：

```text
h[chunk,v,k] = h_low[v,k]
```

每线程写两个 K8：

```text
snapshot 0: v=4*w+g,    k=8*m ... +7
snapshot 1: v=16+4*w+g, k=8*m ... +7
```

整个 CTA 对一个 V32 state snapshot 发出 512 个 b128 vector store，即每线程
两个。snapshot 的 GMEM store 可以继续在后台执行；后续只要确保其 LDS
source 已经读入 VGPR，就可以重用原 LDS 区域。

### 7.4 Residual, row gate, and v_new

首先在 FP32 中计算：

```text
R_raw = fp32(U) - projection
```

如果保存 `v_new`：

```text
v_new = cast<Element>(R_raw)
```

之后才应用 row gate：

```text
R_gate[t] = R_raw[t] * exp(g[last]-g[t])
```

因此启用 G 时，`v_new` 与 GEMM1 使用的 residual 数值不同。

`R_gate` 转成 Element 后写入 swizzled `v_tile`。其物理坐标适配
`ds_read_m32x16`：

```text
stage        = t_local / 16
physical_row = g + 4*(t_local % 4)
physical_v   = 8*((t_local % 16) / 4)
```

### 7.5 GEMM1: state delta

GEMM1 计算：

```text
Delta[V32,K128] = R_gate[T64,V32]^T @ K[T64,K128]
```

T64 分成 4 个 T16 stage。每个 wave 计算 `[V32,K32]`。四个 accumulator
的逻辑映射：

| Accumulator | `s=0..3` 对应 Delta |
|---|---|
| `c00[s]` | `Delta[v=g+4*s, k=k0]` |
| `c01[s]` | `Delta[v=g+4*s, k=k1]` |
| `c10[s]` | `Delta[v=g+16+4*s, k=k0]` |
| `c11[s]` | `Delta[v=g+16+4*s, k=k1]` |

因此可以直接回写：

```text
c00/c01 -> state_reg[0..3]
c10/c11 -> state_reg[4..7]
```

GEMM1 后不需要额外的 cross-lane shuffle。

`fla_mmac_f32_16x16x16_trans_c` 通过交换 MMAC A/B 参数得到需要的 C
fragment orientation；它不是事后转置 accumulator。

### 7.6 State update

每个线程对其 K pair 执行：

```text
state_reg[s][0] = state_reg[s][0] * state_scale[k0] + delta[k0]
state_reg[s][1] = state_reg[s][1] * state_scale[k1] + delta[k1]
```

更新后的 FP32 state 保留在 VGPR，并转成 Element 写回 `h_low`，供下一个
chunk 的 GEMM0 和 snapshot 使用。

## 8. VMEM age model and synchronization

full-chunk 快路径依赖固定的 VMEM issue order和固定 instruction count；OOB
通过 `voffset=-1` 表达，不改变请求条数。`wait_vmcnt<N>` 的含义是允许最多
保留 N 个更年轻的请求，而不是“等待 N 次访存”。

在 `G + GK + Save_new_value + PrefetchNextW` 的最重配置下：

| Checkpoint | Wait | 目的 |
|---|---:|---|
| GEMM0 后使用 G | `vmcnt(5)` | 证明两个 G load 已完成，保留 U/K |
| residual 前使用 U | `vmcnt(12)` | 证明 U 已完成，保留 K/snapshot/Wnext/GK |
| GEMM1 entry | `vmcnt(9)+lgkmcnt(0)+barrier` | 证明 K D2L 完成并发布 K/v_tile |
| 使用 GK 前 | `vmcnt(1)` | 证明 snapshot/Wnext/GK 完成，最多留下 v_new |
| full chunk exit | `vmcnt(1)+lgkmcnt(0)+barrier` | 发布新 h_low 和 Wnext，允许 v_new 继续飞行 |

`compiler_sched_barrier` 固定 VMEM 指令不能跨 age-model checkpoint 重排。

tail path 更保守：

- K D2L 做 bounds check；
- 无效 U/residual row 显式清零；
- GEMM1 stage 数为 `ceil(valid_t/16)`；
- 多个 checkpoint 使用 `wait_all_and_barrier()`；
- 不预取下一 chunk W。

## 9. Initial and final state

initial state 被转成 FP32 `state_reg`。没有有效 state slot 时 state 初始化为零。
所有 chunk 完成后，`state_reg` 转成配置的 State dtype 并写 final state。

SGLang path 中 initial/final state 指针别名，所以是原地 persistent-state
更新。`h` 仍保存每个 chunk 的 pre-update Element snapshot。

## 10. Triton numerical alignment notes

HIP 与 Triton 数学语义一致，但不能期望逐 bit 相同：

1. GEMM0/GEMM1 的 K/T reduction 分块和 FP32 加法顺序不同；
2. HIP 的 `state * scale + delta` 可能发生 FMA contraction；
3. 同时启用 G/GK 时，结合顺序不同：

```text
Triton: (state * exp(g)) * exp(gk)
HIP:     state * (exp(g) * exp(gk))
```

4. natural exp 在 HIP 中通过 `exp2(x*log2(e))` 实现；
5. snapshot 和 GEMM operand 的舍入点语义一致，但底层指令序列不同。

## 11. Why BV64

> Implementation status: the targeted SGLang specialization is implemented for
> BF16 input/state, G-only, safe-natural varlen int32 calls. The active version
> is the 32 KiB LIT/LTS design in section 18. Sections 12--17 describe the
> superseded 28 KiB two-V32-pass implementation and remain useful as the
> evolution/risk record. Unsupported combinations fall back to BV16/BV32. The
> initial gfx938 automatic threshold is 128 logical BV64 blocks and can be
> overridden for A/B with `AITER_FLA_FORCE_BV`.

对固定 `(sequence, head, chunk)`，W、K、G、GK 与 V tile 无关。当前
V128 使用 4 个 BV32 CTA，这些公共输入会被重复加载 4 次。

BV64 把 CTA 数从 4 减少到 2。如果一个 BV64 CTA 内的两个 V32
micro-pass 真正复用 W/K/G/GK，则这些公共输入的显式全局访存请求减半。

BV64 不会减少：

- GEMM0/GEMM1 总 FLOPs；
- U 总读取量；
- h snapshot 总写回量；
- v_new 总写回量；
- K 的 LDS read/MMAC 使用次数；
- 每个 V output 所需的 projection 和 state update。

它是一种跨 V micro-tile 的公共输入复用，而不是减少数学计算。

## 12. Historical BV64 LDS budget (superseded)

按当前 trait 公式原样放大，Element 为 2 bytes：

```text
v_tile[T64,V64] = 64*64*2   =  8 KiB
h_low[V64,K128] = 64*128*2  = 16 KiB
K_tile[T64,K128]= 64*128*2  = 16 KiB
W_tile                         0 KiB
-------------------------------------
total                         40 KiB
```

原样 native BV64 无法控制在 32 KiB 内。

可选布局：

| 方案 | LDS/CTA | K 与 GEMM0 重叠 | 主要代价 |
|---|---:|---|---|
| 原样 native BV64 | 40 KiB | 保留 | LDS 高、native V64 fragment 重构 |
| full V64，alias `h_low/v_tile` | 32 KiB | 保留 | 正好 32 KiB，需两个额外 cross-wave barrier |
| full V64，alias `h_low/K` | 24 KiB | 大部分丢失 | K D2L 移到 GEMM0/snapshot 后的关键路径 |
| **BV64 CTA 内 2xV32 pass** | **28 KiB** | **保留** | state VGPR 翻倍，CTA 执行时间增长 |
| 2xV32 pass，额外 alias h/v scratch | 24 KiB | 保留 | 更多 barrier，第一版收益有限 |

## 13. Historical BV64 design: two V32 micro-passes (superseded)

推荐第一版让一个 CTA 逻辑上拥有 V64，但在 chunk 内串行执行两个现有
V32 计算布局。

### 13.1 Physical storage

```text
state_reg[16]                  FP32 VGPR, logical V64 state
h_low_scratch[V32,K128]       8 KiB LDS
v_tile_scratch[T64,V32]       4 KiB LDS
K_tile[T64,K128]             16 KiB LDS
------------------------------------------------
total                         28 KiB LDS
```

state ownership 可以自然扩展：

```text
state_reg[s] <-> H[v=g+4*s, k={k0,k1}], s=0..15

pass 0: state_reg[0..7]   -> V[0:32]
pass 1: state_reg[8..15]  -> V[32:64]
```

每个 pass 内把全局 V offset 减去 pass base 后，可以复用现有 BV32：

- h_low swizzle；
- GEMM0 even/odd fragments；
- projection 4x4 lane-group transpose；
- residual V8 ownership；
- v_tile swizzle；
- GEMM1 accumulator-to-state mapping。

### 13.2 Common versus per-pass work

必须提升到两个 pass 外层、每 chunk 只执行一次：

```text
W_current load/copy
K direct-to-LDS
G load / row_scale
GK load / state_scale
W_next prefetch
```

每个 V32 pass 单独执行：

```text
pack corresponding state_reg half -> h_low scratch
GEMM0
h snapshot for this V32
U load for this V32
residual / v_new / v_tile
GEMM1 using the shared K LDS tile
update corresponding state_reg half
```

概念调度：

```text
for each chunk:
    w_pack = current w_carried                 # keep across both passes
    issue G and K D2L once

    run_v32_pass(pass=0, state_reg[0:8], w_pack, k_lds)

    prefetch W_next into w_carried once        # w_pack still owns W_current

    run_v32_pass(pass=1, state_reg[8:16], w_pack, k_lds)

    publish W_next / state for next chunk
```

实际调度可把 U/GK/Wnext issue 放到更有利的位置，但公共输入不能退回到
`run_v32_pass` 内重复加载。

### 13.3 Why the existing helper cannot simply be called twice

直接调用两次当前 `run_chunk_gated_delta_rule_fwd_chunk_bv32_mmac` 会导致：

- K D2L 执行两次，失去最主要的访存收益；
- G/GK 执行两次；
- pass 0 可能已经将 `w_carried` 覆盖为 Wnext；
- pass 1 可能错误使用下一 chunk 的 W；
- waitcnt age model 仍按两个独立 chunk 计算。

建议重构边界：

```text
run_chunk_bv64
  common_prologue             # W/G/K and common gate data
  run_v32_microtile<0>        # no K/W/G reload
  run_v32_microtile<1>        # no K/W/G reload
  common_epilogue             # Wnext and cross-chunk publication
```

### 13.4 Theoretical traffic reduction

对一个完整 V128、一个 `(sequence, head)`、一个 full T64 chunk，Element
为 2 bytes，忽略 gate/state metadata：

| Traffic | 4xBV32 CTA | 2xBV64 CTA with shared W/K | Change |
|---|---:|---:|---:|
| W read | 64 KiB | 32 KiB | -50% |
| K read | 64 KiB | 32 KiB | -50% |
| U read | 16 KiB | 16 KiB | unchanged |
| h snapshot write | 32 KiB | 32 KiB | unchanged |
| v_new write | 16 KiB | 16 KiB | unchanged |
| total | **192 KiB** | **128 KiB** | **about -33%** |

G/GK 的显式 load 数也可以减半。实际 HBM 流量收益可能较小，因为当前
多个 BV32 CTA 对相同 W/K 的请求可能命中 L2；BV64 仍会减少 VMEM 指令、
L1/L2 流量和 cache pressure。

### 13.5 Synchronization requirements

两个 pass 共用 scratch/K LDS 时至少要保证：

1. pass 0 所有 wave 完成对 `v_tile` 的读取后，pass 1 才能覆盖
   `v_tile_scratch`；
2. pass 0 的 h snapshot LDS source 已读入 VGPR 后，才能覆盖
   `h_low_scratch`；
3. K D2L 只需在 pass 0 第一次 GEMM1 前完成；pass 1 直接复用已发布的
   K LDS；
4. `w_pack` 必须跨两个 pass 保持 Wcurrent，`w_carried` 才能安全接收
   Wnext；
5. pass 0 的可选 v_new store 可能跨入 pass 1，新的 VMEM age model 必须
   正确计入或显式排空；
6. tail path 仍应先采用保守 `wait_all_and_barrier()`，待 correctness 稳定
   后再做细粒度 waitcnt。

## 14. Historical BV64 resource and performance risks

### 14.1 VGPR pressure

保持相同 ownership 时：

```text
BV32: 16 FP32 state elements/thread
BV64: 32 FP32 state elements/thread
```

顺序执行两个 V32 pass 可以复用 projection/GEMM1 accumulators，但
`state_reg` 本身翻倍；同时还需保持 Wcurrent、Wnext、gate data 和部分
prefetch payload。BV64 的实际 occupancy 很可能首先受 VGPR 而不是 28 KiB
LDS 限制。

必须检查最终 ISA/resource usage，而不能只依据 C++ 局部变量估算。

### 14.2 Grid parallelism

V128 下：

```text
BV32: 4 CTA per (sequence, head)
BV64: 2 CTA per (sequence, head)
```

BV64 减少公共输入流量，同时也将 grid.x 减半、单 CTA 工作量约翻倍。
如果沿用“至少 48 blocks”的粗略并行度门槛，BV64 需要：

```text
2 * N * H >= 48  ->  N * H >= 24
```

这只能作为初始 heuristic，最终 threshold 应通过不同 batch/head/seqlen 和
目标 GPU benchmark 决定。

### 14.3 Cache effects

当前 4 个 BV32 CTA 读取相同 W/K 时，后发 CTA 可能命中 L2。因此理论上的
W/K 请求减半不必然等价于 HBM bytes 减半。需要结合 profiler 观察：

- VMEM instruction/request count；
- L1/L2 hit rate 和带宽；
- HBM read bytes；
- kernel occupancy / waves per CU；
- long-sequence steady-state latency。

## 15. Historical implementation sequence

1. 引入 BV64 instance/dispatch，但默认关闭自动选择；
2. 把 BV32 helper 拆分为 common chunk prologue 和 V32 micro-tile body；
3. 增加 `state_reg[16]` load/store mapping；
4. 先实现 28 KiB、无 LDS alias 的两个 V32 pass；
5. K D2L 每 chunk 只执行一次，并在两个 GEMM1 pass 间保留；
6. Wcurrent `w_pack` 跨两个 pass 保留，Wnext 只预取一次；
7. G/GK 只加载一次并跨两个 pass 复用；
8. tail 首先使用 conservative waits；
9. 为 pass 边界重新证明 LDS barrier 和 VMEM age model；
10. correctness 稳定后再恢复 full-chunk relaxed waitcnt；
11. 检查 VGPR、LDS、occupancy 和 ISA；
12. benchmark 后增加 BV16/BV32/BV64 runtime selector。

## 16. Historical validation checklist

### Correctness

- fp16/bf16 input × fp32/bf16 state；
- G only、GK only、G+GK、no gate；
- save/no-save v_new；
- initial/final state 和 in-place SGLang state；
- fixed-length 与 varlen；
- full chunk、1-row tail、15/16/17-row tail、63-row tail；
- GQA `H != Hg`；
- state index 有效、负数和越界 slot；
- 比较 BV64、BV32 HIP 与 Triton reference；
- 使用与当前容差一致的数值验证，并单独记录 G+GK 的结合顺序差异。

### Resource/performance

- 确认动态 LDS 为 28 KiB；
- 检查 VGPR/thread 和 spills；
- 检查 occupancy；
- 确认每 chunk 每 BV64 CTA 只有一次 K D2L 和一次 W load/carry；
- 确认 G/GK 未在两个 micro-pass 中重复加载；
- profiler 验证 W/K VMEM request 约减半；
- 比较小 `N*H` 下的并行度损失；
- 比较长 sequence 下的 steady-state 流量收益；
- 调优 BV64 dispatch threshold。

## 17. Retired first design decision

第一版 BV64 推荐方案：

```text
one CTA owns V64
two sequential V32 micro-passes
shared Wcurrent in VGPR
shared K tile in LDS
shared G/GK in VGPR
28 KiB LDS without aliasing
FP32 state_reg[16]
```

该方案保留 BV64 最重要的全局访存红利：W/K/G/GK 在两个 V32 子块间
复用；同时最大限度复用当前已验证的 BV32 swizzle 和 MMAC fragment 映射。
第一阶段不建议为了从 28 KiB 继续压到 24 KiB 而引入 LDS alias；相比
4 KiB LDS 节省，额外 barrier、waitcnt 复杂度和 correctness 风险更高。

## 18. Current production BV64 LDS32 design

### 18.1 Target and ownership

当前生产路径只实例化以下 SGLang 组合：

```text
Element=BF16, State=BF16, K=V=128, BT=64, BV=64
G-only, SafeNatural, save v_new, in-place initial/final state
varlen cu_seqlens/chunk_indices=int32, transpose_state_layout=true
```

一个 CTA 有 4 个 wave64，全部分布在 BV 方向：

```text
w = wave_id
p = lane_id & 15
q = lane_id >> 4

v = v_begin + 16*w + p

state_even[bk][e] = H[v, 32*bk + 8*q + 2*e]
state_odd [bk][e] = H[v, 32*bk + 8*q + 2*e + 1]
bk,e = 0..3
```

每线程持续保留 32 个 FP32 state 值。GEMM1 的 LIT/LTS C fragment 直接
回到同一个 even/odd ownership，不需要跨 lane 重排。

GEMM0 的 BF16 BK8 operand 在 lane 内由转换源选择直接生成：

```text
state_lo = {even0, odd0, even1, odd1}
state_hi = {even2, odd2, even3, odd3}
```

BK 在外层、T16 stage 在内层，因此一个 BK32 state pack 被全部 4 个 T16
复用。BK128 合计仅 16 条 `v_cvt_pk_bf16_f32`/lane/chunk；state operand
路径不生成 `ds_bpermute_b32`。U consumer 另有每个 T16 stage 两条
bpermute，见下一节。

### 18.2 Exact LDS allocation and alias lifetime

```text
[ 0 KiB,  8 KiB): W BK0/BK1 -> U T64xV64 -> padded V stage 3 [0,2.5 KiB)
[ 8 KiB, 16 KiB): W BK2/BK3 -> padded V stages 0..2 [8,15.5 KiB)
[16 KiB, 32 KiB): K T64xK128
-----------------------------------------------------------
total: 32 KiB dynamic LDS
```

W 由现有 `fla_prefetch_w_to_lds` direct-to-LDS producer 生成。四个 BV wave
使用相同 W image；consumer 仅把逻辑 row 改为 `16*t_stage+p`。

所有 wave 完成 BK0/BK1 的 W LDS read 后执行 `lgkmcnt(0)+barrier`，此后
低 8 KiB 才能被 U 覆盖。U 通过两个 T32xV64 D2L 请求填满该区域；每个
T16 恰好占独立 2 KiB。producer lane `x` 从 GMEM 读取逻辑 V8 group
`x XOR row_pair`，但 m0 wrap 的物理写入位置保持不变，因此 GMEM 仍覆盖
连续 V64，D2L 每个八 lane phase 的 B128 bank quartet 仍为 0..7 的排列。

V 使用 40-element BF16 row stride；每个 T16xV32 panel 从 1 KiB 增至
1.25 KiB，但通过非连续 stage placement 仍完整落在原 16 KiB W/U/V alias
内。逐 T16 的变换为：

```text
q-even: ds_read_b128 U V8 from row-XOR address
full EXEC: lgkmcnt(0), 2 x ds_bpermute_b32 -> per-lane V4
stage 0..2: lgkmcnt(0), FP32 residual and row gate
stage 3: lgkmcnt(0) + barrier, FP32 residual and row gate
v_cvt_pk_bf16_f32
ds_write_b64 into stride-40 matrix-DS V panel
```

q-even 为 `q=0/2`，即 lane `0:15,32:47`。只有 B128 read 使用半 EXEC；
编译器在 read 后恢复 EXEC，两个 bpermute 和 residual 都由 64 lane 执行。
stage 0..2 写入已死亡的高 W 区域，不覆盖任何 U；stage 3 的 barrier 保证
所有 wave 都已消费四个 U stage 后才复用低 LDS。最终 V-store barrier 仍负责
向 GEMM1 发布全部 panel。

四个 normal V fragment 全部读入 VGPR 并完成 CTA barrier 后，W-next 才能
覆盖 W/U/V alias。K 使用单 buffer；当前 chunk 的所有 alt read 完成后才
允许下一 chunk 的 K D2L 覆盖。

### 18.3 Chunk pipeline and wait-count proof

full steady chunk 的顺序为：

```text
1. publish W_current at chunk entry
2. issue g_last + four g_cur
3. GEMM0 BK0/BK1 (LIT-only), close low-W LDS lifetime
4. issue U D2L x2, then K D2L x4
5. GEMM0 BK2/BK3 while U/K transfer
6. vmcnt(4)+lgkmcnt(0)+barrier
     -> G/U complete; four younger K requests may remain
7. issue h snapshot x4/lane
8. transform four U T16 regions to V; issue v_new x4/lane
9. read all four V normal fragments into VGPR; close W/U/V reads
10. issue W_next D2L x4
11. vmcnt(12)+barrier (last chunk uses vmcnt(8))
     -> K complete; h/v_new/(W_next) remain younger
12. for each BK32: scale FP32 state and accumulate four K-alt/V-normal
    LIT+LTS MMAC stages
13. lgkmcnt(0)+barrier closes K reads
```

`vmcnt(4)` 的依据是 U 两条请求比 K 四条更老。K publication 前，K 后面
固定存在 h store 4 条和 v_new store 4 条；steady chunk 再加 W-next 4 条，
因此阈值分别为 8 和 12。OOB 通过 `voffset=-1` 保持固定指令数，tail 仍以
full EXEC 执行全部 matrix-DS/MMAC stage。

### 18.4 State, snapshot, and residual precision

- state 在 chunk 间始终为 FP32 VGPR；只有 GEMM0 operand、h/final store
  才转换为 BF16；
- `h[chunk]` 在 GEMM1 更新前从 FP32 state 直接 lane-local pack；
- U D2L 得到 BF16，先转换 FP32，再减去 FP32 GEMM0 projection；
- `v_new` 保存 gate 前 raw residual；
- row-gated residual 转 BF16 后进入 V LDS，供 GEMM1；
- GEMM1 以 `state * exp(g_last)` 作为非零 FP32 accumulator，随后累加
  `K^T @ V`。

### 18.5 Compiled resource and ISA gate

gfx938 当前 toolchain 的最终 code object：

```text
VGPR                         128
SGPR                          81
private segment                0 B/thread
VGPR/SGPR spills               0
dynamic LDS                32768 B/CTA
threads                       256
HIP occupancy API               2 CTA/CU
```

对象级指令检查：

```text
normal ds_read_m32x16_b16       present
alternate ds_read_m32x16_b16    present
q-even ds_read_b128              1 / T16 stage
ds_bpermute_b32                  2 / T16 stage, full EXEC
MMAC                             LIT-only or LIT+LTS only
scratch buffer load/store        absent
```

需要注意 `group_segment_fixed_size=0` 是因为 LDS 在 launch 时动态传入，
不能据此判断 LDS 为 0。实际值由 `Kernel_traits::smem_size==32768` 编译期
断言、launch 参数和 occupancy/PMC 共同验证。

### 18.6 First-version result and next work

目标 shape（32 条长度 1216 的序列，`T=38912,H=32,Hg=16,NT=608`）在同一
空闲 gfx938 上，warmup 25/rep 100：

```text
BV32                 2.6726 ms
BV64 LDS32           2.0802 ms
speedup              1.285x
latency reduction    22.2%
```

Triton 对照的 `h/v_new/final_state` 全部通过 `rtol=atol=0.08`。

### 18.7 q-even U integration result

将 standalone demo 的 row-XOR D2L + q-even B128 consumer 移植到生产
kernel 后，目标 shape 的 tail correctness 和完整 38912-token Triton 对照
均通过。目标 shape 的稳定 HIP timing 为 `2.0662 ms`；相对初版
`2.0802 ms` 仅改善约 0.7%，说明单独修 U 还不是完整 latency 解法。

同一 one-shot workload 的 PMC 对比：

| Counter | initial BV64 | q-even U | delta |
| --- | ---: | ---: | ---: |
| `SQ_INSTS_LDS` | 6,848,512 | 8,093,696 | +18.18% |
| `SQ_INSTS_VALU` | 42,336,256 | 46,465,024 | +9.75% |
| `SQ_LDS_BANK_CONFLICT` | 49,807,360 | 32,374,784 | **-35.00%** |
| `SQ_WAIT_INST_LDS` | 2,275,700 | 2,567,972 | +12.84% |
| PMC dispatch duration | 2.110078 ms | 2.108800 ms | -0.06% |

按 72 CU 归一化，bank-conflict active-cycle fraction 从 `25.06%` 降到
`16.30%`。新增两条 bpermute/T16 使 LDS 指令与等待数上升，基本抵消本轮
冲突下降在端到端时间上的收益。这也把下一步边界收窄为：

1. 设计与 GEMM0/GEMM1 ownership 配套的 conflict-free V producer 和
   normal matrix-DS consumer，避免现有 `ds_write_b64` 冲突；
2. 评估是否能把 U read/bpermute 的 wait 与 row-scale、V producer 进一步
   交错，而不增加区域复用 barrier；
3. 收紧 chunk-entry 的 conservative `wait_all`，进一步隐藏 W-next 和
   store latency；
4. 保持 32 KiB/2 CTA occupancy 和 scratch=0。

### 18.8 Stride-40 V producer padding

独立 demo 将 V producer 与 matrix reader 分开采样。20 轮 T16 路径的 PMC
结果为：

| Layout | B64 write conflict | matrix-read conflict | total |
| --- | ---: | ---: | ---: |
| stride 32 normal | 960 | 640 | 1600 |
| stride 32 row-XOR | 960 | 0 | 960 |
| **stride 40 padding** | **320** | 640 | **960** |

因此 stride-32 row-XOR 只优化 consumer，并不优化 `ds_write_b64`；最终采用
stride-40 padding，把 V 写冲突降低 66.7%。stride 36/44/52/60 会破坏
`ds_read_m32x16_b16` operand ownership；stride 56 虽然正确且写冲突相同，
但需要 14 KiB image 和两个区域复用 barrier，完整 kernel 没有收益。

stride-40 生产路径把 stage 0..2 放入已死亡的高 W 区域，stage 3 放回低
LDS，只保留 stage 3 的 region-reuse barrier。相对 18.7 的 q-even U 基线，
同一 one-shot workload 的关键 PMC 为：

| Counter | q-even U baseline | stride-40 V | delta |
| --- | ---: | ---: | ---: |
| `SQ_INSTS_LDS` | 8,093,696 | 8,093,696 | 0 |
| `SQ_INSTS_VALU` | 46,465,024 | 46,432,256 | -0.07% |
| `SQ_LDS_BANK_CONFLICT` | 32,374,784 | 27,394,048 | **-15.39%** |
| `SQ_WAIT_INST_LDS` | 2,567,972 | about 1,847,000 | **about -28%** |

gfx938 code object 仍为 128 VGPR、81 SGPR、0 scratch/0 spill，动态 LDS 仍为
32 KiB。目标 38912-token shape 的完整 Triton 对照通过，三类输出的最大绝对
误差均为 `0.000244140625`。当前节点 timing 存在约 2.10/2.20 ms 双峰；交错
A/B 未显示可重复的端到端变化，因此本轮结论只确认 bank-conflict 和同步点
下降，不宣称稳定 latency speedup。

## 19. BV64 path to 1.6 ms: optimization exploration plan

### 19.1 Goal, baseline, and current evidence

目标 shape 上的当前基线约为：

```text
BV32             about 2.7 ms
BV64 LDS32       about 2.1 ms
target           about 1.6 ms
remaining        about 0.5 ms / 23.8%, or another 1.31x speedup
```

18.7--18.8 的结果表明，单独减少 LDS bank conflict 不会自动转化为稳定的
kernel latency 改善。从 2.1 ms 到 1.6 ms 需要同时减少关键路径上的
`waitcnt`/barrier、重复数值转换和 CTA 间公共 GMEM 请求。预期最终方案将由一组
调度优化加上至少一项结构性优化组成。

当前 SQTT 捕获到的 GEMM0 热点片段呈现以下重复模式：

```text
ds_read_b128 W fragment
s_waitcnt lgkmcnt(0)             cumulative about 8K--9K clocks / 504 hits
v_mmac ... low-half ... lit
v_mmac ... high-half ... lit
```

截图中的 MMAC 只带 `lit`而不带 `lts`，因此该片段是 GEMM0。GEMM1 需要在
最终 ISA 中单独找到 `lit,lts` 区域后重新统计。对 profiler 中不同 wave 叠加得到的
clocks 不应直接相加作为端到端收益，但每次 DS read 后立即 `lgkmcnt(0)` 足以
证明 LDS-to-VGPR-to-MMAC 尚未构成有效软件流水。

### 19.2 Manual unroll means software pipelining

GEMM0/GEMM1 源码已有 `#pragma unroll`，因此单纯把 `for` 循环改写为重复语句不是
本轮优化的核心。所谓“手动展开”应当同时完成：

1. 用独立的 C++ raw-fragment 变量表达两个或三个逻辑 slot；
2. 在消费当前 slot 前，通过 builtin 提前表达后续 DS read；
3. 不为 BV64 W/K consumer 增加 inline-asm DS read 或手写 `lgkmcnt`，由编译器依据
   builtin 结果依赖推导 waitcnt；
4. 保持 stage/half 为编译期常量，避免动态 vector 索引导致 scratch；
5. 以最终 ISA 而不是 C++ 语句顺序判断实际 read-ahead 和 waitcnt 位置。

以 depth-2 rolling pipeline 为例：

```text
issue fragment 0
issue fragment 1
compiler-derived partial wait, consume fragment 0 with two MMACs
issue fragment 2 into the released slot
compiler-derived partial wait, consume fragment 1 with two MMACs
issue fragment 3
compiler-derived partial wait, consume fragment 2 with two MMACs
compiler-derived final wait, consume fragment 3 with two MMACs
```

热循环入口仍需要建立干净的 LGKM age-model 边界。`lgkmcnt` 不只计数目标 W/K read，
还可能包括 LDS write、`ds_bpermute`、scalar memory load 等；但具体 counter 值及其位置由
编译器统一维护，源码不再假设某个手写 `lgkmcnt(N)` 对应某个 fragment。

实现只用 builtin 与独立 C++ raw variables 表达 pipeline。编译器可以合法地跨 BK 移动
read，或把 D2/D3 canonicalize 成相同 ISA；因此不通过 scheduling barrier 或 DS-read asm
强制源码顺序。若最终 ISA 仍收缩为 `read -> wait(0) -> MMAC`，优先调整循环次序、变量
live range 和独立计算的位置，再由实测决定是否保留。

### 19.3 GEMM0 W-read pipeline

GEMM0 每个 W B128 fragment 产生 4 个 raw VGPR，然后分成两个 BF16x4 operand，
执行两条 LIT-only MMAC。第一轮探索包括：

| Variant | Pipeline shape | Approximate raw-fragment VGPR delta | Purpose |
| --- | --- | ---: | --- |
| G0 | current read/wait0/use | 0 | baseline |
| G1 | depth-2 rolling | +4 | preferred first implementation |
| G2 | depth-3 rolling | +8 | cover a longer LDS latency |
| G3 | four reads followed by partial drains | +12 | upper-bound/batch experiment |
| G4 | G1 plus first-read-before-state-pack | about +4 | hide first-read latency with conversion |
| G5 | G2 plus first-read-before-state-pack | about +8 | deeper version of G4 |

每个 BK32 开始时，当前代码先执行 4 条 `v_cvt_pk_bf16_f32` 得到 state operand，
再发起第一条 W read。W address 不依赖 state pack，所以可以改成：

```text
issue first W read of BK n
pack state_lo/state_hi of BK n
issue second W read
partial wait and consume first W fragment
```

这使 state conversion 成为 pipeline fill work。在 BK 为外层、T16 为内层的前提下，
同一 BK32 state pack 仍然复用四次，并且连续 T16 MMAC 写入不同 projection accumulator，
不会引入额外的 C-accumulator 链。

GEMM0 中间的 BK1/BK2 边界不能被 rolling pipeline 跨过。BK0/BK1 消费完成后必须
drain 所有低 W read 并完成 CTA barrier，然后低 8 KiB W 才可以被 U D2L 覆盖。
允许的跨 BK pipeline 只有 BK0 -> BK1 和 BK2 -> BK3。

### 19.4 GEMM1 K-read and accumulator pipeline

当前 GEMM1 以 BK 为外循环，每个 BK 先 scale state，读取四个 T16 K fragment，再连续
更新同一对 `state_even/odd[bk]` accumulator。源码中 `k_raw[4]` 已经表达了批量读取
的意图，但最终是否保留批量发射必须以 `lit,lts` ISA/SQTT 为准。

除 BK-major D2/D3 外，还应测试 T16-major/BK-inner 顺序：

```text
for each T16 stage:
    pipeline K(stage, BK0..BK3)
    update four independent BK accumulators
```

推荐的第一个 T16 stage fill 顺序为：

```text
issue K(T0,BK0)
scale state[BK0]
issue K(T0,BK1)
scale state[BK1]
partial wait, MMAC BK0 even/odd
issue K(T0,BK2)
scale state[BK2]
partial wait, MMAC BK1 even/odd
...
```

这个顺序同时优化两条依赖链：

- state scale 和已就绪 fragment 的 MMAC 覆盖年轻 K read；
- 相邻 iteration 更新不同 BK accumulator，增大再次读写同一 MMAC C fragment 之间的距离。

GEMM1 的实验矩阵为：

| Variant | Traversal | LDS pipeline | Extra scheduling work |
| --- | --- | --- | --- |
| K0 | current BK-major | compiler generated | baseline |
| K1 | BK-major | D2 rolling | none |
| K2 | BK-major | D3 rolling | none |
| K3 | T16-major/BK-inner | D2 rolling | accumulator interleave |
| K4 | T16-major/BK-inner | D3 rolling | accumulator interleave |
| K5 | T16-major/BK-inner | best of D2/D3 | state scale used as fill work |

当前 `k_raw[4]` 需要 16 个 raw VGPR。D2 rolling 只需 8 个，D3 只需 12 个，因此
GEMM1 的手工流水可能在降低 LDS wait 的同时降低峰值 VGPR。

### 19.5 VGPR and resource gate

本轮探索允许用更多 VGPR 换取 LDS latency hiding，但需要同时满足：

```text
final allocated VGPR count < 192
private segment / scratch = 0
VGPR and SGPR spills = 0
measured occupancy does not regress
dynamic LDS remains 32 KiB for the current BV64 path
```

`192` 是探索的硬上限，不是默认目标。如果 D2/D3 能保持在 160/176 或更低的分配档位，
应优先选择较低 VGPR 版本。验收必须查看最终 code object 中的
`amdhsa_next_free_vgpr`/private segment 和 occupancy API，不能仅根据 C++ 临时变量数量估算。

VGPR 分配有硬件粒度，并受 `__launch_bounds__(256, 2)` 影响。如果跨过某个档位后导致
occupancy 下降或编译器为满足 launch bounds 产生 scratch，即使仍低于 192 也应拒绝
该 variant。

### 19.6 Measurement and acceptance protocol

由于当前节点存在约 2.10/2.20 ms 双峰，所有 variant 应先在固频、空闲 GPU 上使用
交错 A/B 测量，并同时报告 median 和较快 mode，避免把频率/负载变化误判为 kernel 收益。

每个 GEMM variant 至少记录：

```text
end-to-end kernel latency
GEMM0 and GEMM1 waitcnt pre-issue stall separately
SQ_WAIT_INST_LDS
SQ_INSTS_LDS
SQ_LDS_BANK_CONFLICT
MMOP issue/utilization and accumulator stalls
VGPR/SGPR, scratch, spills, and occupancy
```

本轮优化不会减少 W/K 的数学读取次数，所以 `SQ_INSTS_LDS` 未必显著下降。主要的
ISA 验收目标是：

```text
fewer immediate lgkmcnt(0) drains
compiler-generated partial waits consistent with builtin result dependencies
more DS reads in flight before the first consumer
shorter gaps between useful MMAC issues
no extra scratch buffer traffic
```

数值验证需覆盖 full chunk、单 chunk tail、多 chunk tail、空 state slot 以及完整目标 workload；
`h`/`v_new`/final state 全部继续与 Triton reference 对照。

### 19.7 Broader optimization queue after GEMM pipelining

LDS-to-MMAC 流水值得优先实验，但不预期单独完成从 2.1 ms 到 1.6 ms 的全部
23.8% 降时。初始收益预算为：

```text
GEMM0 LDS software pipeline                 about 2--5%
GEMM1 LDS + accumulator software pipeline   about 3--7%
combined                                    about 5--10%, non-additive
```

该数字是实验优先级假设，不是已测结果。如果集成后约为 1.9--2.0 ms，后续按以下
顺序继续：

1. **Reuse GEMM0 state packs for the h snapshot.**  每 lane/chunk 可避免约 16 条重复
   `v_cvt_pk_bf16_f32`；需重新证明 h store 插入后的 VMEM age model。
2. **Carry G-next behind W-next.**  在 W-next 后发射下一 chunk 的 5 条 G load，将下一
   chunk 入口改为允许 G 继续 outstanding 的 partial wait；对应 K publication 需重新计数。
3. **Batch or pipeline U reads.**  分离 U DS issue/consume，测试两个或四个 T16 的批量
   q-even read/bpermute，并尝试用 row-scale 和 h-store 工作覆盖 LDS wait。
4. **Register-only residual-V path.**  用 bpermute/DPP hybrid 将 residual V4 直接转换为
   GEMM1 operand，删除 `ds_write_b64 -> barrier -> ds_read_m32x16`。该方案必须与
   VGPR<192 和 zero-scratch 约束一起验收。
5. **Compact row-G load/exp ownership.**  让 lane 0..63 各计算一个 T64 row scale，再用
   permlane/DPP/bpermute 分发，测试用更少 G load/`v_exp` 换取 lane-exchange 的收益。
6. **BV128 with eight waves.**  一个 8-wave CTA 保持每 wave V16 和每线程 32 FP32 state，
   在 V128 上再次将 W/K/G 公共输入请求减半。这是到达 1.6 ms 最值得优先的结构性
   候选，但需重新设计两个 V64 U/V 子流水和 8-wave barrier。
7. **Reduce LDS only with an occupancy proof.**  将 W/K 改为 BK64/T32 streaming，尝试将 LDS
   降到 16--24 KiB。只有当 VGPR 同时允许 3 CTA/CU 且新 D2L wait 未抵消收益时才保留。
8. **Consider kernel fusion if the operator boundary may change.**  如果 `h` 只是下游 kernel 的中间输入，
   融合 producer/consumer 以消除 h GMEM store/reload 可能比单个 waitcnt 优化有更大收益。

建议的阶段性目标为：

```text
2.10 ms
  -> 1.90--2.00 ms  GEMM0/GEMM1 software pipeline and pack/schedule cleanup
  -> 1.75--1.88 ms  register-V, G carry/compaction
  -> 1.55--1.72 ms  BV128 or producer/consumer fusion
```

上述区间是用于决定实验顺序的工程预算，各项收益不可简单相加。第一轮实施先比较
GEMM0 builtin-only D2/D3；GEMM1 仅在不破坏编译器 builtin wait 推导的前提下调整循环
结构，每次只改一个 pipeline 维度。

### 19.8 First GEMM0/GEMM1 pipeline experiment record

2026-09-04 在宿主容器执行测试。每次测试前均运行 `hy-smi`，确认前四张卡的
`HCU=0%`，并固定使用 HCU 0。目标输入按 varlen 扁平布局传入：`B=1,T=38912`，
`cu_seqlens=[0,1216,...,38912]`，等价于 32 条长度 1216 的序列；其余参数为
`H=32,Hg=16,K=V=128,BT=64,BF16 input/state,int32 indices`。warmup 25、rep 100。

初始实现的完整 Triton 对照通过：

```text
h max abs             0.00006103515625
v_new max abs         0.000244140625
final_state max abs   0.00006103515625
rtol / atol           0.08 / 0.08
```

第一轮结果：

| Variant | DS read mechanism | HIP event median | event min/max | VGPR | Scratch/spill | Decision |
| --- | --- | ---: | ---: | ---: | --- | --- |
| Original | builtin/compiler schedule | 2.0774 ms | 2.0730 / 2.0909 ms | 128 | 0 / 0 | baseline |
| GEMM0 D2, rejected implementation | inline asm + manual wait | 2.0665 ms | 2.0618 / 2.0762 ms | 144 | 0 / 0 | reject mechanism |
| GEMM0+GEMM1 D2, rejected implementation | inline asm + manual wait | 2.3175 ms | 2.2958 / 7.5299 ms | 144 | 0 / 0 | reject regression |
| GEMM0 D3 | builtin/compiler schedule | 2.0733 ms | 2.0691 / 2.2006 ms | 132 | 0 / 0 | not preferred |
| **GEMM0 D2** | **builtin/compiler schedule** | **2.0712 ms** | **2.0666 / 2.0869 ms** | **132** | **0 / 0** | **current default** |

builtin-only D2 相对本轮原始 event median 改善约 0.30%；D3 约 0.20%，差异接近噪声，
所以优先保留 live range 更短的 D2。最终 ISA 显示编译器会把部分 W read 跨 BK 移动，
并自动组合 `lgkmcnt(1)`/`lgkmcnt(0)`；源码 D2/D3 并不等价于固定的硬件 depth。

GEMM1 的原始 `k_raw[4]` builtin 代码在最终 ISA 中已经形成两组 K read、partial/final wait
和 even/odd MMAC 穿插。手工 inline-asm D2 虽保持 144 VGPR、zero scratch/spill，却使
event median 回退约 11.9%，表明它限制了编译器在 K read、地址计算和 even/odd MMAC
之间的调度自由度。该实现已从有效代码路径移除；后续 GEMM1 实验必须保持 matrix-DS
builtin，并优先探索 T16-major/BK-inner 的 C++ 循环重排或缩短 `k_raw` live range。

本轮也修正了最初“GEMM 流水可直接带来 5--10%”的收益预估：在当前编译器已经做了
部分自动流水的前提下，单纯展开 GEMM0/GEMM1 不足以把 2.1 ms 推到 1.6 ms。下一轮应
优先结合 SQTT 分段计数判断是继续做 builtin-only GEMM1 traversal，还是转向
state-pack/h-snapshot 复用、G-next carry、register-only residual-V 或 BV128。

### 19.9 G-next carry and GEMM0 state-pack reuse

2026-09-04 继续在同一宿主环境、同一目标输入和相同 warmup/rep 配置下实验。每次 GPU
测试前都重新运行 `hy-smi`；前四张卡均为 `HCU=0%`，固定选择 HCU 0。两项优化均保留
matrix-DS builtin，没有为 `ds_read` 引入 inline asm。

#### 19.9.1 Carry G across the chunk boundary

prologue 现在按以下顺序发射：

```text
initial state load x4
W0 D2L x4
G0 load x5
vmcnt(9)                 publish initial state
chunk entry vmcnt(5)     publish W0, leave G0 outstanding
```

steady chunk 在 W-next D2L 后立即发射五条 G-next load。上一个 chunk 的 K publication
点原先需要等待 K 之后的 `h x4 + v_new x4 + W_next x4`，现在再加 G-next x5，故当时的
年龄计数从 12 改为 17；下一 chunk 入口只等待到 `vmcnt(5)`，保证 W-next 和更老的 store
完成，同时允许五条 G load 继续 outstanding。G 在 GEMM0 后、U/K publication 点才被
真正消费。

最终 ISA 确认发射顺序为 `W-next x4 -> G-next x5 -> vmcnt(17)`，下一 chunk 为
`vmcnt(5)`，LLVM 没有破坏所需的 VMEM 年龄关系。该版本资源为 139 VGPR、84 SGPR、
zero scratch/spill；目标用例正确性通过。性能如下：

| Variant | HIP event median | event min/max | VGPR | SGPR | Result |
| --- | ---: | ---: | ---: | ---: | --- |
| builtin GEMM0 D2 baseline | 2.0712 ms | 2.0666 / 2.0869 ms | 132 | 81 | baseline |
| G-next carry | 2.0606 ms | 2.0560 / 2.0915 ms | 139 | 84 | keep; 0.51% faster |

#### 19.9.2 Reuse GEMM0 BF16 state packs for h snapshot

原实现每个 BK32 已为 GEMM0 生成 `state_lo/state_hi`，但 chunk 末尾的 h snapshot 又把
同一 FP32 state 转成 BF16。新实现让一个 BK 的四个 T16 GEMM0 stage 消费完以后，直接
用仍存活的两个 BF16x4 pack 发射该 BK 的 B128 h store。因此每 lane/chunk 消除了 16 条
重复的 `v_cvt_pk_bf16_f32`，且无需长期保存四个 BK 的 packed state。

h store 的移动改变了 VMEM 年龄：

```text
G_current                       carried from previous chunk
h snapshot BK0/BK1 x2          older than U and K
U D2L
K D2L x4
h snapshot BK2/BK3 x2
vmcnt(6)                        publish G/U; K and high-h may remain
v_new store x4
W_next D2L x4
G_next load x5
vmcnt(15)                       publish K in a steady chunk
                                (last chunk uses vmcnt(6))
GEMM1
next chunk vmcnt(5)             publish W; leave G outstanding
```

这里 `vmcnt(6)` 的六个 younger operations 是 `K x4 + high-h x2`；steady K publication
的 15 个 younger operations 是 `high-h x2 + v_new x4 + W-next x4 + G-next x5`。
最终 ISA 同时确认了 `vmcnt(6)/vmcnt(15)/vmcnt(5)`，以及 BK0/1 h store 位于 U/K 前、
BK2/3 h store 位于 K 后。重复的 chunk 尾 h-pack 转换已经消失。

组合版本 code object 为 135 VGPR、81 SGPR、zero scratch/spill，仍低于 192 VGPR gate，
动态 LDS 保持 32 KiB。目标 pytest 扩展为 `seqlen=63/64/65/128/390`，覆盖单/双/多
chunk 的 full/tail 路径，结果为 `5 passed`；benchmark 的 Triton 对照中
`h`、`v_new`、`final_state` 全部通过。两次独立性能测量为：

| Run | HIP timing | HIP event median | event min/max | Correctness |
| --- | ---: | ---: | ---: | --- |
| first | 1.9393 ms | 1.9670 ms | 1.9626 / 2.0064 ms | pass |
| repeat | 1.9350 ms | 1.9644 ms | 1.9584 / 3.9155 ms | pass |

第二次测试存在一个 3.9155 ms 的外部抖动样本，但 median 与首次相差仅 0.0026 ms。
两次 event median 平均为 1.9657 ms，相对 builtin D2 的 2.0712 ms 改善约 5.1%，相对
最初 2.0774 ms 改善约 5.4%。因此两项优化均保留；下一阶段从约 1.966 ms 到 1.6 ms
仍需约 18.6% 的时延缩减，不能只依赖继续调整同一组 waitcnt。

### 19.10 Current-kernel PMC bottleneck analysis

2026-09-04 使用 G-next carry + GEMM0 state-pack reuse 的当前版本，在宿主 HCU 0 上采集
hipprof PMC。每组采集前均运行 `hy-smi`，确认前四张卡为 `HCU=0%`。输入与 serving
记录严格对齐：

```text
B=1 T=38912 N=32 NT=608 H=32 Hg=16 K=128 V=128 BT=64
k              (1, 38912, 16, 128) BF16
w              (1, 38912, 32, 128) BF16
u              (1, 38912, 32, 128) BF16
g              (1, 38912, 32)      FP32
initial_state  (744, 32, 128, 128) BF16
cu_seqlens     (33,)                int32
h              (1, 608, 32, 128, 128) BF16
v_new          (1, 38912, 32, 128) BF16
```

`cu_seqlens=[0,1216,...,38912]`，即 32 条等长 1216 的 sequence。测试强制 BV64、缓存
`chunk_offsets`，并使用 `warmup=0,rep=1,skip-triton,no-verify`，保证应用只提交一次目标
kernel；hipprof 为不同 counter pass 自动 replay 十次。三组采集分别使用：

```text
hipprof --pmc       --pmc-type 3 --kernel-name chunk_gated_delta_rule_fwd_kernel
hipprof --pmc-read  --pmc-type 3 --kernel-name chunk_gated_delta_rule_fwd_kernel
hipprof --pmc-write --pmc-type 3 --kernel-name chunk_gated_delta_rule_fwd_kernel
```

profiler 环境下 benchmark 自身打印的 4--5 ms event timing 包含 profiler replay/同步开销，
不能作为 kernel 时间。以下时延均取 PMC CSV 的 `EndNs-BeginNs`。

#### 19.10.1 General PMC

general counter group 的十次 replay 平均时延为 1.948879 ms，范围为
1.914559--1.983200 ms。指令 counter 每次 replay 完全一致：

| Counter | Per dispatch | Per wave |
| --- | ---: | ---: |
| `SQ_INSTS_VALU` | 45,293,568 | 5,529 |
| `SQ_INSTS_LDS` | 8,093,696 | 988 |
| `SQ_INSTS_VMEM_RD` | 2,367,488 | 289 |
| `SQ_INSTS_VMEM_WR` | 1,277,952 | 156 |
| `SQ_LDS_BANK_CONFLICT` | 27,394,048 | -- |
| `SQ_WAIT_INST_LDS` | about 1,842,562 | -- |

grid 有 2048 个 256-thread CTA，即 8192 waves；每条 sequence 有 19 个 full chunk。
PMC CSV 报告硬件分配粒度下的 136 VGPR、96 SGPR、32768 B LDS 和 zero scratch；对应
code-object metadata 的实际使用量仍为 135 VGPR、81 SGPR。动态指令数可精确还原为：

```text
MMAC / wave       = 19 * (32 GEMM0 + 32 GEMM1) = 1216
LDS / wave        = 19 * 52                    = 988
VMEM read / wave  = initial-state 4 + 19 * (W 4 + U 2 + K 4 + G 5)
                  = 289
VMEM write / wave = 19 * (h 4 + v_new 4) + final-state 4
                  = 156
```

按 72 CU、9 个 active TA/SE partitions 和 288 SIMD 归一化：

| Derived metric | Value | Interpretation |
| --- | ---: | --- |
| kernel time | 1.9489 ms | PMC replay mean |
| TA memory-unit busy | 86.6% | memory front end almost continuously active |
| TCP-to-TA data stall | 43.2% | material memory-front-end backpressure/latency |
| VALU busy | 30.5% | not a pure VALU/MMAC saturation signature |
| LDS bank-conflict fraction | 14.9% | still a secondary optimization target |
| aggregate L2 hit rate | 37.9% | expected one-shot streams plus W/K reuse |
| TCC write stall | 0.013% | write channel is not the direct stall source |

每个 CTA/chunk 的两个 BF16 GEMM 合计 2,097,152 FLOPs。整个 dispatch 为
81.604 billion FLOPs，对应约 41.9 TFLOP/s。该值和 30.5% VALU busy 都不支持“当前首先
受 MMAC throughput 限制”的判断。

`SQ_WAIT_INST_LDS` 表示等待 LDS instruction issue，而不是停在 `s_waitcnt lgkmcnt` 的
依赖时延。hipprof 当前固定 PMC 组没有同时给出 `SQ_WAIT_CNT_VM`、
`SQ_WAIT_CNT_LGKM` 和 `SQ_WAIT_BARRIER`；后续若要精确拆分 vmcnt、lgkmcnt 和 barrier，
仍需 custom counter pass 或 SQTT。不能仅根据 `SQ_WAIT_INST_LDS` 推断 screenshot 中的
`s_waitcnt` 已经不再是热点。

#### 19.10.2 Read/write traffic

read-focus 和 write-focus counter pass 的结果为：

| Traffic | Per dispatch | Rate in its PMC pass |
| --- | ---: | ---: |
| EA/HBM read | 0.840 GB | 0.422 TB/s |
| EA/HBM write | 0.991 GB | 0.497 TB/s |
| total | about 1.831 GB | about 0.919 TB/s |

理论唯一输入量为：

```text
W                 0.318767 GB
K                 0.159384 GB
U                 0.318767 GB
initial state     0.033554 GB
G                 0.004981 GB
total             0.835453 GB
```

PMC read 只比唯一输入量高约 0.6%。这说明同一个 W 被两个 V64 CTA 使用、同一个 K 被
两个 query heads 和两个 V64 CTA 使用所产生的重复请求，已经基本在 cache 层吸收。
因此只调整 block launch order 或追求更高 L2 hit rate，不是当前最高优先级；但是这些
cache hit 仍然占用 VMEM issue、TA/TCP/TCC 和 D2L publication 资源。

理论输出量为：

```text
h snapshots       0.637534 GB
v_new             0.318767 GB
final state       0.033554 GB
total             0.989856 GB
```

PMC write 与理论输出量相差约 0.1%，证明当前基本没有多余的 GMEM store traffic。
其中 h 占总输出约 64%。由于 TCC write stall 接近零，单纯更换 store 宽度或移动 store
不太可能再带来大收益；只有取消输出或和 consumer 融合，才能移除这部分流量。

#### 19.10.3 Bottleneck conclusion

当前主要限制是 VMEM/D2L/store 共同形成的片上 memory-front-end 请求压力和 latency，
其次是仍有约 14.9% active-cycle fraction 的 LDS bank conflict/同步成本。HBM read 已经
接近算法唯一输入下界，GMEM write 也接近 API 输出下界；问题不是 cache 没有捕获 W/K
复用，也不是多发了输出 store。MMAC/VALU 尚未达到首先限制性能的利用率。

这也解释了为什么单独把 GEMM0/GEMM1 的 builtin LDS read 做 D2/D3 展开只有约 0.3%
收益：它没有减少 VMEM/D2L 请求、LDS traffic 或输出量。后续仍应保持 W/K matrix-DS
builtin；只有当循环重排同时引入 K streaming、register-V 或更大 CTA 复用时，才值得
重新调整 GEMM traversal。

#### 19.10.4 Optimization directions

按预期收益上限排序：

1. **BV128 CTA**。用一个 CTA 覆盖两个当前 BV64 V blocks，使 W 和 K 各少一次 D2L。
   预计片上请求量分别减少约 0.319 GB，合计约 0.638 GB；HBM read 基本不变，因为这些
   重复流量当前已经命中 cache。第一版可用 4 waves、每 wave 两个 V16 micro-pass，验收
   `VGPR<192`、zero scratch/spill、32 KiB LDS 和至少 2 CTA/CU。
2. **h producer/consumer fusion**。如果调用图允许，把 h snapshot 直接交给下游，移除
   0.638 GB h store 及下游对应 read。这是 standalone kernel 之外最可能提供两位数收益
   的方向。
3. **同一 grouped-K 的双-head CTA**。`H/Hg=2`，一个 CTA 顺序处理两个 query head，
   共享 K D2L，可再减少约 0.319 GB 片上 K 请求。它和 BV128 都会增加 state VGPR，第一轮
   应分别实验，不直接组合。

按低风险实施顺序：

1. **K BK32 ping-pong**。把完整 16 KiB K tile 改成两个 4 KiB BK32 buffer，在 GEMM1
   BK n 的 builtin matrix-DS/MMAC 期间 D2L BK n+1。目标是 K LDS 降到 8 KiB，并消除
   “完整 K publication 后才开始 GEMM1”的等待。
2. **register-V**。把 residual V 做 lane-local/permutation 重排后直接保留在 VGPR，先
   移除每 chunk 四条 V LDS write、四条 V matrix read 及对应 barrier/conflict；允许增加
   8--16 VGPR，但总量保持小于 192。
3. **G load compaction**。G 只有约 5 MB，但每 wave/chunk 有五条 load，占全部 VMEM-read
   instruction 的 `95/289=32.9%`。实验由一个 wave carry G-next，并在 current K 生命周期
   结束后通过死 K LDS 向下一 chunk publication；理论上消除四个 waves 中 3/4 的重复 G
   wavefront loads，但必须检查新增 LDS/barrier 是否抵消收益。
4. **将 LDS 压到约 21 KiB 以下**。K ping-pong、streamed W 和 register-V 组合后，目标
   layout 可接近 18--20 KiB，再实测 3 CTA/CU。TA busy 已达 86.6%，更高 occupancy 不保证
   提速，必须通过 duration、TA stall 和 SQTT 同时验收。

建议下一轮实际实现顺序为 `K BK32 ping-pong -> register-V -> BV128 -> G compaction`。
如果这些 standalone 优化仍无法达到 1.6 ms，再进入 h producer/consumer fusion。
