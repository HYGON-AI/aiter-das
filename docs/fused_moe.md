<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fused\_moe 算子说明与性能报告

## 一、设计思路

### 1.1 fused\_moe 的整体设计

fused\_moe 是混合专家（MoE）层的前向总入口：接收 token 激活与专家权重，把每个 token 按路由结果分发给选中的专家做两次矩阵乘与激活加权求和，输出与输入同形状的结果。它的执行链路分四段：

1. **参数归一化**：从权重张量与调用参数构造统一的对象（`FusedMoeProblem`，模块 `fused_moe_router`），包含形状（expert、inter\_dim、model\_dim）、本次计算语义（token 数 M、topk、activation、quant\_type 等）与运行模式（是否专家并行等），后续所有判断都基于这一个对象。
2. **layout 判定与复核**：按准备对象 prepared 与权重标记判定生效 layout（规则见 4.2 节），再校验该 layout 对当前调用合法（`_check_runtime_layout`，模块 `fused_moe`），参数与模型初始化时不一致会立即报错。
3. **路由**：按候选顺序为当前调用选择后端（汇编 asm / moe\_c / triton）并查调优配置（`fused_moe_router.plan`）；权重若已按非 raw 方式 shuffle，直接绑定对应后端，不再走候选链。
4. **执行**：路由结果（后端、内核方案编号 sol\_id、分块大小）交后端执行器，全链路不做任何现场 shuffle。

其中「权重要不要 shuffle」的判断被整体前移到模型初始化期的 fused\_moe\_prepare\_weights：它按调优表实测耗时决定每层权重的 layout（raw / asm\_shuffle / marlin），一次性完成 shuffle，在权重上打标记，并返回只读的准备对象 prepared（记录 layout、处理后的缩放系数与准备参数）；模型运行期按 prepared 执行、不再决策。这样每次前向节省下全部现场 shuffle 开销，且 layout 选择从人工经验变成数据驱动。

### 1.2 与 aiter\_moe 的区别

| 维度         | aiter\_moe                                                      | fused\_moe                                               |
| ---------- | --------------------------------------------------------------- | -------------------------------------------------------- |
| 定位         | 能力全集，用户持有配置对象                                                   | 自动路由，用户零决策                                               |
| layout 决策  | 用户传入 use\_shuffle 参数人工决定要不要 shuffle，再读返回配置里的 need\_shuffle 标志确认 | 库内部决策函数按实测耗时一次定死，用户无感知                                   |
| shuffle 执行 | 用户持配置自己调 aiter\_moe\_shfl\_weight                               | fused\_moe\_prepare\_weights 内部一次完成                      |
| 执行期行为      | 接口内可现场 shuffle（use\_weight\_shuffle 裸布尔）                        | layout 断言，绝不现场 shuffle                                   |
| 配置对象       | 每层都要传递 AiterMoeConfig                                           | 不需要，路由结果不暴露给用户                                           |
| 错配处理       | 信任用户，传错就查错表跑错摆放                                                 | 只读准备对象 + 标记比对 + layout 复核 + 查表弃权：标记冲突与参数不一致直接报错，权重被改动时告警 |

两个接口的重排实现各自独立：fused\_moe 侧是 `fused_moe_layout._prepare_shuffle`（只实现路由可达的家族），aiter\_moe 侧仍是 `aiter_moe_shfl_weight` / `aiter_moe_shfl_scale`，两端由逐位对拍测试保证一致，不共享代码。区别的本质：aiter\_moe 把「该不该 shuffle」的责任留给用户，fused\_moe 把它收进库内部。新旧用法对照：

```python
# aiter_moe 旧用法：用户自己决定 shuffle
ok, moe_config = get_aiter_moe_config(..., use_shuffle=1)   # 人工判断
if moe_config.need_shuffle:
    w1, w2 = aiter_moe_shfl_weight(w1, w2, moe_config, block_shape)
out = aiter_moe(hidden, w1, w2, topk_weights, topk_ids, moe_config,
                use_weight_shuffle=True)

# fused_moe 新用法：决策全自动
w1p, w2p, prepared = fused_moe_prepare_weights(w1, w2, w1_scale=s1, w2_scale=s2, ...)
out = fused_moe(hidden, w1p, w2p, topk_weight, topk_ids, ..., prepared=prepared)
```

### 1.3 侧重点：继承 ROC fused\_moe 的参数与使用习惯

fused\_moe 直接沿用 ROCm/aiter fused\_moe 的接口形态，用户几乎不需要改调用代码：

- **参数名与调用形态一致**：hidden\_states、w1、w2、topk\_weight、topk\_ids、activation、quant\_type、w1\_scale、w2\_scale、expert\_mask、dtype 等参数名与含义完全相同；新增参数只做加法——唯一新增参数 prepared 放在所有 ROC 参数之后、且仅限关键字传入（`*, prepared=None`），ROC 参数位置一个不动；不走准备函数的调用写法与 ROC 完全相同。
- **权重标记习惯一致**：ROCm/aiter 用张量属性 is\_shuffled 布尔标记「重排过」（函数 `shuffle_weight`，模块 `aiter.ops.shuffle`），本设计沿用同一习惯但扩展为三值 weight\_layout（raw / asm\_shuffle / marlin），语义从「重排过没有」升级为「按哪种方式摆放」。
- **使用习惯一致**：ROCm/aiter推荐加载期调 shuffle\_weight 处理权重、运行期直接 fused\_moe；本设计把这一步标准化为 fused\_moe\_prepare\_weights，调用节奏（初始化期准备、运行期前向）不变。
- **参考实现与测试对齐口径一致**：与ROCm/aiter相同使用 torch\_moe 作为数值参考，测试入口与基准方式沿用 op\_tests 习惯。

### 1.4 优势

1. **数据驱动**：layout 选择依据两张调优表的实测耗时比较（收益 ≥5% 才 shuffle），不再靠人工判断 use\_shuffle。
2. **保守兜底**：收益不明显就维持 raw——即使调优数据有噪声，最坏结果是少赚几个百分点，不会变慢。
3. **安全校验**：模型运行期的 layout 复核把「初始化参数与推理参数不一致」拦在报错上，不会静默出错误数值。
4. **用户零学习成本**：不需要理解后端矩阵，参数与用法沿用 ROC fused\_moe 习惯。
5. **兼容 torch.compile**：prepared 只在 Python 外壳中使用，拆成 layout 字符串与缩放系数张量后再进入已注册的自定义算子，算子签名不含 Python 对象；编译场景以 test\_moe\_w8a8\_test\_for\_moe\_c\_torch\_compile.py 验证。

***

## 二、接口与功能

对外共三个接口，都在 aiter.fused\_moe\_layout 模块（fused\_moe\_layout.py）与 aiter.fused\_moe 模块（fused\_moe.py）。

### 2.1 fused\_moe\_prepare\_weights（函数 fused\_moe\_prepare\_weights，模块 fused\_moe\_layout.py）

模型初始化期的权重准备入口：为一对专家权重（w1 门控/上投影、w2 下投影）决定 layout、按需完成 shuffle、标记输出，返回可直接喂给 fused\_moe 的权重。

| 参数                                                                        | 含义                                                             |
| ------------------------------------------------------------------------- | -------------------------------------------------------------- |
| w1, w2                                                                    | 专家权重，形状 \[E, N1, K] 与 \[E, K, N2]                              |
| quant\_type                                                               | 量化方式（QuantType 枚举：No / per\_Tensor / per\_Token / per\_1x32 等） |
| w1\_scale, w2\_scale                                                      | 权重量化 scale，可选                                                  |
| dtype                                                                     | 激活数据类型，默认 bf16                                                 |
| topk                                                                      | 路由 topk                                                        |
| activation                                                                | 激活函数（ActivationType 枚举）                                        |
| expert\_mask                                                              | 专家并行掩码，可选；传入表示专家并行模式                                           |
| backend                                                                   | 后端偏好："auto"（默认）/ "asm" / "moe\_c" / "triton"                   |
| max\_num\_tokens                                                          | 可选，双表耗时比较只统计该范围以内的 token 档位                                    |
| block\_size\_M, doweight\_stage1, splitk, quant\_type\_a, quant\_dtype\_a | 与 fused\_moe 同语义的运行模式参数，参与可行性判断                                |

**返回**：三元组 `(w1p, w2p, prepared)`。w1p、w2p 是 shuffle 后（或原样）的权重对，带 weight\_layout 标记，由用户自行持有；prepared 是只读准备对象 `PreparedMoe`（不含权重），运行期作为 fused\_moe 的 `prepared=` 参数传入：

| prepared 字段          | 含义                                                                                                |
| -------------------- | ------------------------------------------------------------------------------------------------- |
| layout               | 最终 layout（"raw" / "asm\_shuffle" / "marlin"），只读，用户不能改写                                            |
| w1\_scale, w2\_scale | 按决策处理后的缩放系数（raw 原样、marlin 透传、asm 的 `w2_scale` 按 `padded_k` 补零；per\_Tensor 的缩放系数已展开为 per\_channel） |
| signature            | 准备参数签名（quant\_type、dtype、topk、activation、是否专家并行、专家数等），运行期逐项比对                                     |
| decision             | 决策详情（family、reason、padded\_k 等），用于排查                                                              |
| arch, cu\_num        | 准备时的显卡架构与计算单元数                                                                                    |

prepared 用冻结数据类实现：`prepared.layout = "raw"` 这类赋值会直接抛错；它对权重只持有弱引用，用来判断运行期传入的是否仍是当初准备的那一对张量，不占用显存。

重复准备：同一对原始权重用同一组参数再次准备命中缓存，返回同一组结果、不重复 shuffle；参数变化时从原始权重重新准备。把已 shuffle 的权重（带 marlin / asm\_shuffle 标记）再次传给准备函数会报错，要求从原始权重重新准备。

### 2.2 fused\_moe（函数 fused\_moe，模块 fused\_moe.py）

模型运行期的前向入口，参数继承 ROC fused\_moe：hidden\_states（\[M, model\_dim] 激活）、w1、w2、topk\_weight、topk\_ids、activation、quant\_type、w1\_scale、w2\_scale、a1\_scale、a2\_scale、expert\_mask、dtype、block\_size\_M、doweight\_stage1、splitk、bias1、bias2、gate\_mode、output 等，语义与ROCm/aiter一致。新增参数：

| 参数       | 含义                                                                                                                     |
| -------- | ---------------------------------------------------------------------------------------------------------------------- |
| prepared | 仅限关键字，位于签名末尾。fused\_moe\_prepare\_weights 返回的准备对象；不传表示权重按 raw 摆放（不走准备函数）。传入时不得再传 w1\_scale / w2\_scale，缩放系数取自 prepared |

公开入口不提供 layout 字符串参数，layout 只能来自 prepared。

**功能**：前置校验 → layout 判定 → 参数归一化 → layout 复核 → 路由 → 执行，模型运行期零 shuffle。判定规则见 4.2 节。

### 2.3 describe\_fused\_moe\_layout（函数 describe\_fused\_moe\_layout，模块 fused\_moe\_layout.py）

只读查询接口，参数与 fused\_moe\_prepare\_weights 相同（不含 max\_num\_tokens 之外的差异），不重排、不修改权重，返回决策全貌：

| 返回字段                                      | 含义                                      |
| ----------------------------------------- | --------------------------------------- |
| layout                                    | 决策出的 layout                             |
| family                                    | 承载后端（asm / moe\_c / triton）             |
| reason                                    | 决策理由（如「双表加权收益 2.1% <5%（28 个 token 档位）」） |
| padded\_k / original\_k                   | 补齐后的 K 与原始 K（K 非 64 倍数时有值）              |
| feasible\_layouts                         | 模型运行期合法的 layout 集合                      |
| weighted\_gain                            | 双表加权收益                                  |
| quant\_kind, arch, shape, current\_marker | 量化家族、显卡架构、形状、权重当前标记                     |

适合加载期核对与日志留痕。prepare 函数本身的决策日志（`fused_moe_prepare_weights` 内的 logger.info）也带同样信息。

***

## 三、使用方法

### 3.1 两种用法

**需要 shuffle 的场景**——量化家族可能受益于 shuffle（无量化、w8a8 等，见第五章决策表），模型初始化期调用 fused\_moe\_prepare\_weights，把输出直接传给 fused\_moe：

```python
from aiter.fused_moe_layout import fused_moe_prepare_weights

# 模型初始化期，每层一次
w1p, w2p, prepared = fused_moe_prepare_weights(
    w1, w2,                          # 输入：原始权重对
    quant_type=QuantType.per_Token,
    w1_scale=w1_s, w2_scale=w2_s,
    dtype=torch.bfloat16,
    topk=8,
    activation=ActivationType.Silu,
)

# 模型运行期，每次前向（缩放系数取自 prepared，不再单独传）
out = fused_moe(hidden_states, w1p, w2p, topk_weight, topk_ids,
                activation=ActivationType.Silu,
                quant_type=QuantType.per_Token,
                prepared=prepared)
```

输入输出说明：输入是原始权重对与描述本次计算的参数（quant\_type、dtype、topk、activation 等，形状不需要传，从权重张量推导）；输出是 `(w1p, w2p, prepared)`——w1p、w2p 是 shuffle 后（或原样）的权重，prepared 是只读准备对象，携带 layout 与处理后的缩放系数。运行期把 prepared 原样传入即可，用户不需要知道 layout 是什么。

**不需要 shuffle 的场景**——该层不会从 shuffle 获益（如 w4a16、专家并行、fp8 非对齐 K），直接调用 fused\_moe，不传 prepared，权重按 raw 处理，写法与 ROC 完全相同：

```python
out = fused_moe(hidden_states, w1, w2, topk_weight, topk_ids,
                activation=ActivationType.Silu,
                quant_type=QuantType.No)
```

用户不需要自己判断属于哪种场景——统一走 fused\_moe\_prepare\_weights 也是完全正确的：它在不受益的场景会返回 layout="raw" 的 prepared 与原权重，代码路径完全一致，无需分支。

### 3.2 只读查询

用 describe\_fused\_moe\_layout 在不改权重的前提下预览决策结果，核对 reason 与 feasible\_layouts 后再决定是否准备。

### 3.3 两个可选参数

| 参数                | 作用                                                                               |
| ----------------- | -------------------------------------------------------------------------------- |
| backend=          | "auto"（默认）自动选择；显式指定 "asm" / "moe\_c" / "triton" 是硬约束，筛查不合格时模型初始化期直接抛错，不带错误配置进入推理 |
| max\_num\_tokens= | 双表耗时比较只统计该范围以内的 token 档位。业务方清楚自己流量分布时（如固定 8192 以内）传入可把比较收窄到实际区间                  |

### 3.4 使用约束

- **必须在目标设备上执行准备**：调优表查表键含显卡架构与计算单元数，不能离线跨机准备；prepared 记录准备时的 arch、cu\_num，运行期不一致直接报错。
- **准备过的权重要配 prepared 使用**：带 marlin / asm\_shuffle 标记的权重不传 prepared 会报错（库不会把它们当 raw）。
- **改了权重要重新准备**：clone、换设备、序列化往返、强化学习同步权重、热更新等操作后，传入的权重不再是 prepared 记录的那一对，库会告警一次并按 prepared.layout 继续执行；如果权重或缩放系数与 prepared 不对应，结果会出错。改动权重后请从原始权重重新调用 fused\_moe\_prepare\_weights。
- **不要把已 shuffle 的权重再交给准备函数**：会报错；准备函数只接受原始权重。同一对原始权重同参数重复准备命中缓存，参数变化则重新准备。
- **模型运行期参数须与初始化期一致**：topk、activation、dtype、quant\_type、expert\_mask（是否专家并行、专家数）与 prepared 记录不一致时报错，并指出不一致的字段。
  R- **topk 取运行期 topk\_ids 的列数**：准备时的 topk 必须等于运行期 `topk_ids.shape[1]`（拼接了共享专家的场景要用拼接后的列数），否则前置校验直接报错。
- **张量内容可被原地修改**：prepared 只读，但其中的缩放系数张量与用户持有的权重仍可原地改写，库无法拦截。

***

## 四、具体实现

### 4.1 模型初始化期：fused\_moe\_prepare\_weights 流程

入口 `fused_moe_prepare_weights`，共五步。

**第一步，构造对象**（`_build_problem`）。函数签名里没有形状参数，全部从权重张量推出：expert 取 w1.shape\[0]、model\_dim（K）取 w1.shape\[2]、inter\_dim（N）取 w2.shape\[2]；token 数固定按 1——调优表分组键不含 token，token 只决定「分组内取哪一行」，不影响「分组是否存在」，所以初始化期用 1 模拟即可。

**第二步，layout 决策**（`decide_layout`，模块 `fused_moe_router`）。分两级：

- 资格筛（不看耗时）：is\_ep / doweight\_stage1 / splitk 只可能落 triton；不同 quant\_type 家族走不同分支（决策规则见第五章）。
- 耗时比拼（仅 w8a8 家族，quant\_type=per\_Tensor / per\_Token）：先做 asm 内部双表比较，再与 moe\_c 做同档位跨后端比较（`_cross_backend_totals`，模块 `fused_moe_router`；档位取两表并集，防止两表档位数差异把总和比较带偏）。

**第三步，asm 内部双表耗时比较**（`_asm_choice`，模块 `fused_moe_router`），只对普通表与 shuffle 表都覆盖的分组进行：

1. 两表该分组下的 token 档位取并集（传 max\_num\_tokens 时只取范围内档位）；
2. 每档在两张表按「取最近行」读 time\_us（复用模型运行期同一二分逻辑）；
3. 等权求和得 T\_raw、T\_shuffle，收益 = (T\_raw − T\_shuffle) / T\_raw；
4. **收益 ≥5% 才选 asm\_shuffle，否则维持 raw**；任一张表缺分组则不比较——只有 shuffle 表覆盖就选 asm\_shuffle，只有普通表覆盖就选 raw。

**第四步，执行 shuffle**。非 raw layout 调 fused\_moe 自用的 `_prepare_shuffle`（模块 `fused_moe_layout`，与 `aiter.moe` 的重排封装独立），并把传入的 `w1_scale` / `w2_scale` 交给它处理：asm\_shuffle 含按 padded\_k 补齐（把 model\_dim 补零到 64 的倍数，代码参数 padded\_k，配置键 PADDED\_K / ORIGINAL\_K）与 `w2_scale` 同步补零；marlin 路径只覆盖路由可达的 w8a16 / w8a8 / w8a8\_block / wfp4a8，scale 原样透传（决策层不会把 w4a16 / w4a8 / wfp4a16 判为 marlin，这些分支在 fused\_moe 侧不可达，出现即报错）；raw 路径权重与 scale 都原样返回。

**第五步，标记并构造准备对象**（`_mark`）。权重设 weight\_layout 属性；构造只读的 `PreparedMoe`（layout、处理后的缩放系数、准备参数签名、决策详情、arch / cu\_num、对 w1p / w2p 的弱引用）。per\_Tensor 缩放系数在重排之前就展开为 per\_channel（补 K 会改变 w2 的几何），运行期拿到的是展开后的版本。返回 `(w1p, w2p, prepared)`，并以「原始权重身份 + 准备参数签名」登记到准备缓存（缓存只存弱引用，不额外占显存）。

进入第一步之前先处理两种输入：

- 输入带 marlin / asm\_shuffle 标记（已 shuffle 过）：直接报错，要求从原始权重重新准备。shuffle 改变了权重形状（asm 补齐 K、w8a16 marlin 的 uint8 视图），按 shuffle 后的形状决策等于描述一个不存在的原始问题；绝不二次 shuffle，也绝不把已 shuffle 的权重改贴 raw 标记。
- 同一对原始权重、同一组准备参数再次调用：命中准备缓存，直接返回上次的结果。

### 4.2 模型运行期：fused\_moe 流程

入口 `fused_moe`（Python 外壳，模块 `fused_moe`）先完成前置校验与 layout 判定，再把 prepared 拆成 layout 字符串与缩放系数张量，交给已注册的自定义算子 `fused_moe_` → `_fused_moe_impl`。共六步。

**第一步，前置校验**（外壳）。任一不通过即报错：

| 检查项                                                                         | 处置              |
| --------------------------------------------------------------------------- | --------------- |
| prepared 与 w1\_scale / w2\_scale 同时传入                                       | 报错：缩放系数只能有一个来源  |
| w1 与 w2 的标记互相不一致                                                            | 报错：要求两个权重一起准备   |
| prepared.arch / prepared.cu\_num 与当前设备不一致                                   | 报错：要求在目标设备上重新准备 |
| 运行期参数与 prepared.signature 不一致（topk、activation、dtype、quant\_type、是否专家并行、专家数） | 报错，列出不一致的字段     |

**第二步，layout 判定**（外壳）。总原则：只要张量上有标记，标记就必须与「声明的 layout」一致；传了 prepared 时声明的 layout 是 prepared.layout，没传时视为声明 raw。

| 是否传 prepared | 是否为准备时那一对（弱引用比对） | 张量标记                  | 处置                                          |
| ------------ | ------------------ | --------------------- | ------------------------------------------- |
| 否            | —                  | 无标记                   | 按 raw 放行                                    |
| 否            | —                  | raw                   | 按 raw 放行                                    |
| 否            | —                  | marlin / asm\_shuffle | 报错：标记与声明的 raw 不一致，提示传入 prepared             |
| 是            | 是                  | 与 prepared.layout 一致  | 按 prepared.layout 放行，不告警                    |
| 是            | 任意                 | 与 prepared.layout 不一致 | 报错：标记与准备对象冲突                                |
| 是            | 否                  | 无标记                   | 告警一次，按 prepared.layout 放行（layout 为 raw 也告警） |
| 是            | 否                  | 与 prepared.layout 一致  | 告警一次，按 prepared.layout 放行                   |

概括为三句：标记冲突报错；张量不是准备时那一对就告警；其余静默放行。说明：

- 「无标记」与「标记为 raw」严格区分：标记为 raw 而 prepared.layout 为 marlin 同样报错。
- 典型告警场景是把第 1 层的 prepared 与第 2 层的权重搭配传入：两层 layout 相同、标记对得上，但缩放系数属于第 1 层，结果会出错，因此同样告警。
- 告警按 prepared 对象去重，每个对象只报一次，可用环境变量关闭；内容说明「传入的权重不是准备函数返回的那一对，现按 prepared.layout 执行，若权重或缩放系数与之不对应结果会出错，改动权重后请重新准备」。
- torch.compile 图捕获期间跳过设备一致性校验与弱引用比对（直接放行），其余校验与标记比对照常执行。

**第三步，构造对象**（`_normalize_problem`）。与初始化期同一份参数归一化逻辑，区别是 token 数取激活张量真实行数；layout 使用第二步的判定结果。

**第四步，layout 复核**（`_check_runtime_layout`，模块 `fused_moe`）。校验当前 layout 下至少有一个后端能不 shuffle 直接消费，即 layout ∈ feasible\_layouts（`fused_moe_router.feasible_layouts`，按形状键缓存）。不合法即报错，消息列出可行 layout 集合与需核对的参数——它抓的是「初始化参数与推理参数不一致」，刻意报错而非偷偷修正。

**第五步，路由**（`plan`，模块 `fused_moe_router`）。两条路：

- raw layout：三级瀑布——路由表推荐 → 候选顺序（每候选过「匹配 + 查配置 + layout 判定」三关）→ triton 兜底（可用 AITER\_FMOE\_TRITON\_FALLBACK=strict 改为报错）；
- 非 raw layout：**短路直连**。绑定表 `_LAYOUT_BACKEND_BINDING` = {marlin: moe\_c, asm\_shuffle: asm}（模块 `fused_moe_router`，唯一事实源，`_layout_directly_usable` 同源引用）命中后跳过瀑布，直接查绑定后端配置；查不到抛错（layout 合法而配置缺失即数据损坏，报错优于静默换后端）。

**第六步，执行**。路由结果 FusedMoePlan（后端、内核方案编号 sol\_id、分块大小等；sol\_id 是调优表每行记录的内核执行方案，按本次 token 数在分组内选行）交后端执行器，全链路零现场 shuffle。模型运行期保留路由的原因：sol\_id 等调优参数必须按本次 token 数查表选行（`fused_moe_asm_wna16` 的 `get_moe_asm_solution`），不能省。

***

## 五、场景适配与后端支持情况

### 5.1 量化家族 × layout 决策表

家族名与参数的对应关系（`_normalize_problem` 的参数归一化逻辑，模块 `fused_moe`）：`w8a8` 家族 = `quant_type` 取 per\_Tensor / per\_Token，权重与激活为 int8 或 fp8，scale 按通道；`w8a8_block` 家族 = `quant_type` 取 per\_1x128 / per\_128x128，权重与激活为 int8 或 fp8，scale 按块（块大小由 `block_shape` 给出）。

| 量化家族（参数对应）                                                                     | 决策结果                                                         | 决策依据（事实）                                                                                                                                                                                                                                  |
| ------------------------------------------------------------------------------ | ------------------------------------------------------------ | ----------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- |
| none（quant\_type=No）                                                           | 双表加权收益 ≥5% → asm\_shuffle，否则 raw                             | configs/tuned\_fmoe\_asm.csv 与 configs/tuned\_fmoe\_asm\_shuffle.csv 的 time\_us 同档位加权比较；moe\_c 该家族需要 moe\_c\_configs/gfx\*/w16a16/ 下带 is\_bottom=True 的 JSON，该目录一个都没有，查表恒空，已从候选顺序移除                                                       |
| w8a8（quant\_type=per\_Tensor / per\_Token，q\_dtype\_a=int8）                    | asm 内部二选一后与 moe\_c 比同档位总耗时，谁低选谁                              | configs/tuned\_fmoe\_asm\_w8a8\_channel\*.csv 与 moe\_c\_configs/tuned\_moe\_c\_w8a8\_{int8,fp8}\_channel.csv 均含 time\_us，可直接比较                                                                                                            |
| w8a8（quant\_type=per\_Tensor / per\_Token，q\_dtype\_a=fp8，model\_dim 是 64 倍数）  | 同上                                                           | 同上                                                                                                                                                                                                                                        |
| w8a8（quant\_type=per\_Tensor / per\_Token，q\_dtype\_a=fp8，model\_dim 不是 64 倍数） | raw（禁止 marlin）                                               | moe\_c 按 padded\_k 补齐后的执行路径计算结果错误（输出与参考结果相似度 cos 仅 0.085，即结果算错、非崩溃；同样的错误在官方 aiter\_moe 调用路径复现，说明缺陷在 moe\_c 算子实现层、不在 fused\_moe），查询层弃权硬卡                                                                                                   |
| w8a8\_block（quant\_type=per\_1x128 / per\_128x128）                             | model\_dim 不是 64 倍数 → asm\_shuffle + 按 padded\_k 补齐；否则双表收益规则 | model\_dim 非对齐时查表逻辑（`_asm_lookup`，模块 `aiter.moe`）强制查 shuffle 表并按 padded\_k 补齐，是内核要求，不做比较                                                                                                                                                  |
| w8a16                                                                          | marlin（moe\_c 有配置）否则 raw 走 triton                            | moe\_c\_configs/gfx\*/int8\_w8a16/ 下的 JSON（如 E=128,N=768,dtype=int8\_w8a16,is\_bottom=True.json）存在即直接用 marlin layout                                                                                                                      |
| w4a16 / w4a8                                                                   | raw                                                          | w4a16 在 block\_shape=(0,32)（32 个元素一组的组量化 scale）且 topk≤8、inter\_dim=256、model\_dim=7168 时命中固定内核方案 SOL\_ID1=50032, SOL\_ID2=60032（`_asm_lookup` 的固定方案表，模块 `aiter.moe`），该方案不区分权重是否 shuffle，shuffle 无意义；moe\_c 匹配层因 marlin 整数四位路径长期计算结果错误主动弃权 |
| mxfp4 量化（w4a16）                                                                | raw                                                          | moe\_c 独占，fp4x2 打包格式原样消费                                                                                                                                                                                                                  |
| mxfp4 量化（w4a8）                                                                 | marlin                                                       | moe\_c 独占，逐专家 layout shuffle                                                                                                                                                                                                              |
| is\_ep / doweight\_stage1 / splitk 任一开启                                        | raw + triton                                                 | asm 与 moe\_c 的匹配层全部拒绝这些运行模式                                                                                                                                                                                                               |

### 5.2 后端支持矩阵

各后端查的配置文件（均在 `aiter\aiter\` 下）：

| 配置文件                                                                                                              | 位置                                                                                                                                   | 用途                                                                      |
| ----------------------------------------------------------------------------------------------------------------- | ------------------------------------------------------------------------------------------------------------------------------------ | ----------------------------------------------------------------------- |
| tuned\_fmoe\_asm.csv / tuned\_fmoe\_asm\_shuffle.csv                                                              | configs/                                                                                                                             | asm 无量化家族普通表 / shuffle 表（含 time\_us）                                    |
| tuned\_fmoe\_asm\_w8a8\_channel.csv / tuned\_fmoe\_asm\_w8a8\_channel\_shuffle.csv                                | configs/                                                                                                                             | asm w8a8（per\_Tensor / per\_Token）家族普通表 / shuffle 表（含 time\_us）         |
| tuned\_fmoe\_asm\_w8a8\_group.csv / tuned\_fmoe\_asm\_w8a8\_group\_shuffle.csv                                    | configs/                                                                                                                             | asm w8a8\_block（per\_1x128 / per\_128x128）家族普通表 / shuffle 表（含 time\_us） |
| tuned\_moe\_c\_w8a8\_int8\_channel.csv / tuned\_moe\_c\_w8a8\_fp8\_channel.csv / tuned\_moe\_c\_w4a8\_channel.csv | moe\_c\_configs/                                                                                                                     | moe\_c 通道表（含 time\_us 与 cu\_num 列），w8a8 与 moe\_c 跨后端耗时比较的数据来源           |
| E=...,N=...,K=...,topk=...,cu=...,dtype=...,is\_bottom=....json                                                   | moe\_c\_configs/gfx938/{int8\_w8a8, fp8\_w8a8, int8\_w8a16, int4\_w4a16, int8\_w4a8, fp4\_w4a16, fp4\_w4a8, fp4\_w4a8\_groupwise32}/ | moe\_c 各家族 JSON 调优配置（文件名即形状键，含 is\_bottom=True 的双文件成对出现）                |
| E=...,N=...,K=...,dtype=w16a16.json（**不带** is\_bottom=True）                                                       | moe\_c\_configs/gfx938/w16a16/                                                                                                       | moe\_c 无量化家族需要带 `is_bottom=True` 的 JSON，该目录**一个都没有**，故查表恒空              |

各后端对 quant\_type 家族的覆盖（实测结论）：

| quant\_type 家族                         | 代表形状 (expert, inter\_dim, model\_dim, topk) | asm                                                                                                   | asm（shuffle）         | moe\_c                                                    | triton |
| -------------------------------------- | ------------------------------------------- | ----------------------------------------------------------------------------------------------------- | -------------------- | --------------------------------------------------------- | ------ |
| none（No）                               | (128, 352, 4096, 8)                         | 可用                                                                                                    | 可用                   | 不可达（w16a16 目录缺 is\_bottom=True 的 JSON）                    | 可用     |
| w8a8（per\_Tensor / per\_Token）         | (256, 128, 7168, 8)                         | 可用                                                                                                    | 可用                   | 可用（tuned\_moe\_c\_w8a8\_int8/fp8\_channel.csv 含 time\_us） | 可用     |
| w8a8\_block（per\_1x128 / per\_128x128） | (256, 128, 7168, 8)                         | 可用                                                                                                    | 可用                   | 不可达（无对应配置文件，且不在 moe\_c 匹配白名单）                             | 可用     |
| w8a16                                  | (128, 768, 768, 8)                          | 不可达                                                                                                   | 不可达                  | 可用                                                        | 兜底     |
| w4a16                                  | (256, 256, 7168, 8)                         | 可用（block\_shape=(0,32) 且 topk≤8、inter\_dim=256、model\_dim=7168 的固定方案 SOL\_ID1=50032 / SOL\_ID2=60032） | 无效（该方案与权重 layout 无关） | 拒绝                                                        | 兜底     |
| w4a8                                   | (256, 1024, 1024, 8)                        | 不可达                                                                                                   | 不可达                  | 拒绝                                                        | 兜底     |
| mxfp4（w4a16 / w4a8）                    | (512, 256, 256, 8) 等                        | 不可达                                                                                                   | 不可达                  | 独占                                                        | 不可达    |

ck 后端：已注册但不在任何候选顺序里，且当前缺运行库文件、查配置恒空，实际永远选不中。triton 是兜底后端：仅消费 raw layout，无调优配置时用默认配置跑并告警（AITER\_FMOE\_TRITON\_FALLBACK=strict 时改报错）。

### 5.3 运行模式参数 × 后端约束

| 参数                                                                  | asm | moe\_c | triton               |
| ------------------------------------------------------------------- | --- | ------ | -------------------- |
| is\_ep=True（expert\_mask 非空）                                        | 拒绝  | 拒绝     | 可服务（w4a16 / w4a8 除外） |
| doweight\_stage1=True                                               | 拒绝  | 拒绝     | 可服务                  |
| splitk=1                                                            | 拒绝  | 拒绝     | 可服务                  |
| activation=situ                                                     | 拒绝  | 唯一可服务  | 拒绝                   |
| activation ∈ {silu, gelu, gelu\_tanh, swigluoai, swiglustep, relu2} | 允许  | 允许     | 允许                   |

fused\_moe\_prepare\_weights 必须收集并参与决策的参数：quant\_type、dtype、topk、activation、is\_ep（expert\_mask）、doweight\_stage1、splitk、权重形状。token 数不参与。

### 5.4 从执行期现场 shuffle 迁移

执行期现场 shuffle 已整体移除（旧过渡开关 AITER\_FMOE\_LIVE\_SHUFFLE 不在代码里），raw 权重不再有运行时重排兜底。旧代码「不准备、直接调 fused\_moe」的写法会走到以下两种结果之一：

| 量化家族                                                  | 旧写法（raw 权重，不准备）的新行为                                                                          |
| ----------------------------------------------------- | -------------------------------------------------------------------------------------------- |
| `_MARLIN_REQUIRED_KINDS`：w8a16 / w8a8 / w4a8 / wfp4a8 | 不再进 moe\_c，落到 asm-raw / triton；两者都不可用时 `_no_backend_error` 报错并点名 `fused_moe_prepare_weights` |
| wfp4a16 / wfp4a8（moe\_c 独占家族）                         | 无 raw 后端可用，直接报错                                                                              |

迁移方式：在模型初始化期调用 `fused_moe_prepare_weights`，运行期把返回的 prepared 传给 fused\_moe（推荐，顺带获得 shuffle 加速）；确认该层恒为 raw 时也可以继续不传 prepared，按 raw 执行。

**W4A8 说明**：fused\_moe 侧 w4a8 的布局决策恒为 raw（不重排，由 triton 后端服务），w4a8 的重排（含 int8 容器化）只发生在 aiter\_moe 侧的 `aiter_moe_shfl_weight`，本次不改动该接口与 `aiter_moe`。

***

## 六、测试情况与现存问题

### 6.1 测试文件清单

全部测试文件位于 `aiter\op_tests\`（下表路径相对该目录）。除特别说明外，均为「模型初始化期调用 fused\_moe\_prepare\_weights 一次 + 模型运行期传 prepared」的用法，并保留与 raw 对齐或 torch\_moe 参考校验。

| 文件                                                    | 测试侧重点                                      | 关键用例                                                                                                                                                                                                                                                                                                                                                                                    | 准备函数 / prepared 用法                                 |
| ----------------------------------------------------- | ------------------------------------------ | --------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- | -------------------------------------------------- |
| test\_moe\_layout\_prepare.py                         | layout 准备机制专项（新增）                          | 双表方向决策（低收益选 raw / 高收益选 asm\_shuffle）、model\_dim 非 64 倍数按 padded\_k 补齐（fp8 与 int8）、fp8 且 model\_dim 非 64 倍数时降级 raw、w8a16 marlin 准备、前向零 shuffle 计数、与 `aiter_moe_shfl_weight` 的逐位对拍（asm / w8a8 / w8a8\_block / w8a16 / wfp4a8，不可达家族报错）、前置校验（缩放系数双来源、w1/w2 标记不一致、设备不一致、activation / topk / expert\_mask 与签名不一致）、layout 判定（含 clone / detach / 序列化往返后告警放行、标记冲突报错、跨层搭配告警、告警只报一次）、prepared 只读、准备缓存命中与失效、已 shuffle 权重再次准备报错、torch.compile 对象路径 | 全量覆盖 |
| test\_moe.py                                          | 通用主流程数值与性能                                 | quant\_type 多组合 × g1u0/g1u1 × silu/gelu × token 档位                                                                                                                                                                                                                                                                                                                                      | prepare 一次 + prepared，并与不传 prepared 的 raw 路径对齐     |
| test\_moe\_2stage.py                                  | 两段执行（stage1/stage2）组合                      | 各量化组合的两段路径数值对齐（耗时最长的套件，约 26 分钟）                                                                                                                                                                                                                                                                                                                                                         | prepare 一次 + prepared                              |
| test\_moe\_blockscale.py                              | w8a8\_block 块量化（per\_1x128 / per\_128x128） | pertoken\_quant 分块数值对齐                                                                                                                                                                                                                                                                                                                                                                  | prepare 一次 + prepared                              |
| test\_moe\_ep.py                                      | 专家并行                                       | expert\_mask 下 layout 决策为 raw、落 triton 后端                                                                                                                                                                                                                                                                                                                                               | prepare(..., expert\_mask=expert\_mask) + prepared |
| test\_moe\_w16a16.py                                  | 无量化 / 16 位权重激活                             | 多 token 档位数值与性能基准                                                                                                                                                                                                                                                                                                                                                                       | prepare 一次 + prepared                              |
| test\_moe\_w4a8.py                                    | w4a8 量化正确性                                 | int4 权重 + int8 激活（scalar\_type 量化工具生成）                                                                                                                                                                                                                                                                                                                                                  | prepare 一次 + prepared                              |
| test\_moe\_w8a8.py                                    | w8a8 量化（quant\_type=per\_Token）            | per\_Token 数值与 torch\_moe 对齐                                                                                                                                                                                                                                                                                                                                                            | prepare 一次 + prepared                              |
| test\_moe\_w8a8\_blockscale.py                        | w8a8\_block 块量化                            | blockwise layout 准备后数值校验                                                                                                                                                                                                                                                                                                                                                                | prepare 一次 + prepared                              |
| test\_moe\_w8a8\_blockscale\_fp8.py                   | w8a8\_block 块量化 + fp8                      | fp8 块量化数值对齐                                                                                                                                                                                                                                                                                                                                                                             | prepare 一次 + prepared                              |
| test\_moe\_w8a8\_blockscale\_fp8\_shuffle.py          | fp8 shuffle 路径                             | fp8 量化与 shuffle 路径一致性                                                                                                                                                                                                                                                                                                                                                                   | prepare 一次 + prepared                              |
| test\_moe\_w8a8\_ep.py                                | w8a8 + 专家并行                                | EP 下 int8 权重路由 triton 后端                                                                                                                                                                                                                                                                                                                                                                | prepare(..., expert\_mask=expert\_mask) + prepared |
| test\_moe\_w8a8\_fp8\_perToken.py                     | w8a8 fp8（quant\_type=per\_Token）           | fp8 per\_Token 数值对齐                                                                                                                                                                                                                                                                                                                                                                     | prepare 一次 + prepared                              |
| test\_moe\_w8a8\_fp8\_perToken\_shuffle.py            | w8a8 fp8（quant\_type=per\_Token）+ shuffle  | fp8 per\_Token 的 shuffle 路径一致性                                                                                                                                                                                                                                                                                                                                                          | prepare 一次 + prepared                              |
| test\_moe\_wna16.py                                   | wna16 家族（含 w4a16）                          | w4a16 各形状数值；w4a16 段落不走准备函数、不传 prepared，按 raw 执行（该家族决策恒为 raw，且其分组尺寸可能超出参数归一化限制）                                                                                                                                                                                                                                                                                                          | w4a16 段落不传 prepared；其余 prepare 一次 + prepared       |
| test\_moe\_wna16\_ep.py                               | wna16 + 专家并行                               | 无后端覆盖时抛 NotImplementedError（EP + int4 无验证面）                                                                                                                                                                                                                                                                                                                                             | 验证报错行为，不走 prepare                                  |
| test\_moe\_w8a8\_test\_for\_moe\_c\_torch\_compile.py | moe\_c w8a8 + torch.compile                | prepare 后分别走普通调用与 torch.compile 调用，数值一致                                                                                                                                                                                                                                                                                                                                                 | prepare 一次 + prepared（两路都传）                        |

### 6.2 验收结果

| 项目        | 门槛                                                    | 实际                                       |
| --------- | ----------------------------------------------------- | ---------------------------------------- |
| 数值        | 非 fp8 家族 cos ≥ 0.999；fp8 家族 cos ≥ 0.995（对 torch\_moe） | 达标（各验证日志）                                |
| 零 shuffle | 前向期间 shuffle 函数调用计数 = 0                               | 达标（全 0，test\_moe\_layout\_prepare.py 断言） |
| 性能        | 权重预 shuffle 后前向 ≤ 执行时现场 shuffle 的旧路径，无回退超 2%          | 达标，见 6.3                                 |
| 报错        | 五类错配在路由前 / 执行前报错，无 VMFault                            | 达标                                       |
| 回归        | 17 个测试文件全部通过                                          | 全部通过（回归清单见 6.1）                          |

### 6.3 性能数据

#### 6.3.1 各测试文件的测试参数与实测数据

实测条件：nmz27 容器（2026-10-29，BW1100，gfx938，72 CU，144 GiB），两卡并行跑批（HIP0 / HIP1），17 个测试文件全量执行、全部 PASS。「实测数据」列记录每个文件自身扫描范围内最大工作量 case 的接口调用平均耗时；无性能基准段的文件如实标注。

| 测试文件                                                  | 测试参数                                                                                                                                                               | 实测数据（最大 case 接口调用平均耗时）                                                                                     |
| ----------------------------------------------------- | :----------------------------------------------------------------------------------------------------------------------------------------------------------------- | ---------------------------------------------------------------------------------------------------------- |
| test\_moe\_layout\_prepare.py                         | 机制专项：双表方向决策、padded\_k 补齐（fp8 与 int8）、fp8 且 model\_dim 非 64 倍数降级 raw、强制 asm\_shuffle、w8a16 marlin、重复准备返回同一对象、前向零 shuffle 计数、五类错配报错                                  | —（机制专项，无性能基准段）                                                                                             |
| test\_moe.py                                          | fp16 无量化 use\_g1u1=True，quant\_type=No，E=256，topk=8，model\_dim=7168，inter\_dim=256；当前扫描仅 m=1（triton 兜底）                                                            | m=1：142.88 us（triton 兜底）                                                                                   |
| test\_moe\_2stage.py                                  | bf16，{Silu, Gelu} × {No, per\_Tensor fp8, per\_Token fp8} × 两个形状组：E=8/I=4096/K=6144/topk=2 全 token 档位 1\~163840（triton 兜底）、E=256/I=128/K=7168/topk=8 token 1\~1024 | 最大档 m=163840（E=8 形状组，triton 兜底）：No 1284163.37 us、per\_Tensor 998750.92 us、per\_Token 1005095.73 us（Gelu 组） |
| test\_moe\_blockscale.py                              | bf16，quant\_type=per\_1x128，block\_shape=(128,128)，E=256，topk=8，model\_dim=7168，inter\_dim=256，m∈{1,2,5,16,32,163840}；参考实现按 token 分块（不再依赖显存是否 OOM）；m≥49152 因 asm w8a8\_block 大 token 存量数值缺陷显式 SKIP（m=32768 cos≈0.9997，m=49152 cos≈0.2448，m=163840 cos≈0.5029，已用全精度反量化的 torch\_moe 独立参考确认 fused 侧错误；与权重重排无关，待 kernel 侧修复后放开）          | 最大完成档 m=32：596.36 us                                                                                       |
| test\_moe\_ep.py                                      | bf16，E=32，topk=5，shared\_E=2，ep∈{1,2,4,8}，use\_g1u0/g1u1 × {No, int8quant, fp8quant, int8smoothquant, fp8smoothquant}，m≤256，model\_dim≤8192，inter\_dim≤1280        | m=128，fp8smoothquant，model\_dim=8192，inter\_dim=1280，ep=1：4865.29 us                                       |
| test\_moe\_w16a16.py                                  | bf16 无量化，E=128，topk=8，model\_dim=4096，inter\_dim=352，m∈\[1..65536]                                                                                                 | m=65536：29064.37 us（1.6% 元素超 rtol=0.01/atol=1 容差带，低于 5% 判失败阈值，与回归同口径告警）                                    |
| test\_moe\_w4a8.py                                    | fp16，int4 权重 + int8 激活（scalar\_type 量化工具生成），E=256，topk=8，model\_dim=7168，inter\_dim=256，use\_g1u1=True，m∈\[1..32768]，triton 兜底                                     | —（数值 parity 测试，无性能基准段）                                                                                     |
| test\_moe\_w8a8.py                                    | bf16，quant\_type=per\_Token（int8 权重），E=256，topk=8，model\_dim=6144，inter\_dim=256，m∈\[1..32768]                                                                     | m=32768：15897.05 us                                                                                        |
| test\_moe\_w8a8\_blockscale.py                        | fp16，per\_128x128 int8 块量化 block\_shape=(128,128)，E=256，topk=8，model\_dim=7168，inter\_dim=256，m∈\[1..1024]                                                         | m=1024：1370.35 us                                                                                          |
| test\_moe\_w8a8\_blockscale\_fp8.py                   | fp16，per\_128x128 fp8 块量化 block\_shape=(128,128)，形状同上，m∈\[1..1024]                                                                                                 | m=1024：1358.25 us                                                                                          |
| test\_moe\_w8a8\_blockscale\_fp8\_shuffle.py          | fp16，fp8 块量化 + shuffle 布局（asm w8a8\_group 重排表），形状同上，m∈\[1..32768]                                                                                                  | m=32768：19919.77 us                                                                                        |
| test\_moe\_w8a8\_ep.py                                | fp16，per\_Token int8 + expert\_mask 专家并行，E=256，topk=8，model\_dim=7168，inter\_dim=256，m∈\[8..128]，ep∈{16,1}，shared\_E∈{0,1,2}                                       | m=128，ep=1，shared\_E=2：1949.49 us                                                                          |
| test\_moe\_w8a8\_fp8\_perToken.py                     | fp16，per\_Token fp8，E=256，topk=8，model\_dim=7168，inter\_dim=128，m∈\[1..1024]                                                                                       | m=1024：793.27 us                                                                                           |
| test\_moe\_w8a8\_fp8\_perToken\_shuffle.py            | fp16，per\_Token fp8 + shuffle 布局，形状同上，m∈\[1..32768]                                                                                                                | m=32768：11737.38 us                                                                                        |
| test\_moe\_wna16.py                                   | fp16，w4a16 group32（group\_size=32，has\_zp=True，weight\_bits=4），E=384，topk=8，model\_dim=7168，inter\_dim=256，use\_g1u1=True，m∈\[1..8192]，triton / moe\_c 分段          | —（数值 parity 测试，无性能基准段）                                                                                     |
| test\_moe\_wna16\_ep.py                               | fp16，w4a16 + 专家并行（ep=16），E=256，model\_dim=7168，inter\_dim=2048，m∈\[8..128]                                                                                         | —（验证无后端覆盖时抛 NotImplementedError，无性能数据）                                                                     |
| test\_moe\_w8a8\_test\_for\_moe\_c\_torch\_compile.py | bf16 host，w8a8 fp8（决策 marlin / moe\_c），E=256，topk=8，model\_dim=7168，inter\_dim=128，m=1，普通调用与 torch.compile 调用对齐                                                    | m=1：triton 路径 65.01 us，moe\_c 路径 61.37 us                                                                  |

#### 6.3.2 权重预 shuffle 与执行时现场 shuffle 对比（w8a8 fp8，expert=256 / inter\_dim=128 / model\_dim=7168）

计时口径（每行一个 token 档位）：

- 权重预 shuffle 列 = fused\_moe\_prepare\_weights 耗时 + fused\_moe 执行时间；
- 执行时现场 shuffle 列 = fused\_moe 现场 shuffle + 执行时间（不调用准备函数的旧路径）。

| token 数 | 权重预 shuffle：prepare 耗时 + fused\_moe 执行时间 | 执行时现场 shuffle：现场 shuffle + 执行时间 | 提升    |
| ------- | ---------------------------------------- | ------------------------------- | ----- |
| 8       | 624.78 us（另加一次性 prepare 1453.13 ms）      | 8601.13 us                      | 92.7% |
| 64      | 653.26 us（另加一次性 prepare 1453.13 ms）      | 8882.01 us                      | 92.6% |
| 512     | 682.58 us（另加一次性 prepare 1453.13 ms）      | 9108.95 us                      | 92.5% |

实测说明（2026-10-29，BW1100 单卡，与 6.3.1 同环境；表中「执行时现场 shuffle」列是旧接口（`weight_layout=` 字符串）下的历史记录，保留作量级参考）：

- 权重预 shuffle 列：fused\_moe\_prepare\_weights 一次决策 layout=marlin（family=moe\_c，理由=同档位总耗时 moe\_c 约 11.7e4 < asm(raw) 约 21.0e4），prepare 实测 1453.13 ms 仅初始化期一次；执行时间为 fused\_moe 50 次调用平均（warmup 10 次，CUDA event 计时）。提升列按前向执行口径计算：(现场 shuffle − 预 shuffle 执行) / 现场 shuffle，prepare 为一次性成本不参与。
- 执行时现场 shuffle 列：旧过渡开关 AITER\_FMOE\_LIVE\_SHUFFLE 已从代码移除，当时用与其同一共享重排核心的等价路径复现——每次前向先经 aiter\_moe\_shfl\_weight（asm\_shuffle = asm\_shuffle\_weight\_b8，含按 padded\_k 补 K，本形状 K 对齐无补齐）现场重排原始 fp8 权重，再以「已重排权重 + asm\_shuffle 布局」执行（解 10008+20102 / 10006+20102 / 10011+20102）。当前接口去掉了公开的 `weight_layout` 参数，且准备对象不接受已重排权重，这一列无法按原口径复现，只作历史量级参考。
- 现场路径耗时对 token 数基本不敏感（8.6 ms → 9.1 ms）：每次前向都要重排全部专家权重（E=256 fp8 约 700 MB），重排为固定成本，token 越小预 shuffle 收益占比越高；两路数值一致性 cos 0.9979\~0.9980。

已知参考：一次 fused\_moe\_prepare\_weights 耗时 1.61 秒（仅模型初始化期一次）；2026-10-29 同形状复测为 1.453 秒，量级一致。外壳前置校验的纯 Python 开销实测 7.01 us/次（同对象同参数走校验快路径 + 设备元信息缓存；不含放宽任何校验）。

### 6.4 待优化问题与设计遗留

| #  | 问题                                                                                                                                                                                                                                                                          | 影响                         | 现状与方向                                          |
| -- | --------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- | -------------------------- | ---------------------------------------------- |
| 1  | 两张 asm 调优表来自不同轮调优（w8a8\_block 的 group 表相差约 3 个月），跨表 time\_us 不可比；约四成（25/63）重叠分组的收益落在 3%\~7% 噪声带                                                                                                                                                                             | 单个分组的收益数字不可信，符号可能翻转        | 5% 阈值偏向 raw 兜底，收益结论仅作方向参考；待优化：同一轮调优下重测两张表，收窄噪声 |
| 2  | moe\_c 按 padded\_k 补齐的执行路径计算结果错误（fp8 且 model\_dim 不是 64 倍数时与参考结果相似度 cos 仅 0.085，结果算错、非崩溃）；缺陷位于 moe\_c 执行链路的内核实现：宿主入口 aiter/fused\_moe\_c.py（moe\_c\_fused\_experts）→ GPU 内核 aiter/3rdparty/moe\_c/csrc/，按 padded\_k 补齐与 shuffle 由 aiter/moe.py 的 \_shared\_shuffle\_impl 完成 | 该场景不能用 moe\_c              | 查询层弃权硬卡、降级 raw；缺陷已移交 moe\_c 算子实现的维护方，待修复后解除弃权  |
| 3  | AITER\_FMOE\_TRITON\_FALLBACK=strict 模式未做全量回归基线对比                                                                                                                                                                                                                           | 严格模式下可能有未发现的新增失败           | 待补全量 strict 回归                                 |
| 4  | 显式传 backend= 指定后端不可用时，两处分支静默落 triton（w4a16/w4a8 指定 asm 不可用时、w8a16 指定 asm 时），与其他分支「显式指定即报错」语义不一致                                                                                                                                                                             | 用户指定 asm 却拿到 triton，无提示    | 待统一为显式指定不可用即抛错；不影响 backend="auto" 路径           |
| 5  | layout 整层锁死，无法按 token 区间切换摆放（小 token 与大 token 各有偏好的形状只能折中）                                                                                                                                                                                                                  | 极端形状选不到全局最优                | 设计权衡：双份权重方案因显存翻倍未采纳；max\_num\_tokens 收窄比较范围可缓解 |
| 6  | 双表比较用档位等权求和，与真实流量分布可能不匹配                                                                                                                                                                                                                                                    | 流量分布极端时收益打折                | 同 #5，用 max\_num\_tokens 把比较收窄到实际区间             |
| 7  | ~~fused\_moe\_prepare\_weights 固定返回三元组~~ ~~`(w1p, w2p, layout)`，按 padded\_k 补齐后的 w2\_scale 无法随权重交回用户~~ 已修复：返回 `(w1p, w2p, prepared)`，处理后的缩放系数作为 prepared 的字段交回；未走准备函数的调用执行期仍保留一次幂等的补零                                                                                       | 无（已消除）                     | 已随准备对象接口调整修复                                   |
| 8  | w4a16 分组尺寸超出参数归一化限制时，调用准备函数会在形状推导上报错                                                                                                                                                                                                                                        | 该家族部分形状只能不走准备函数、按 raw 直接调用 | 遗留限制；test\_moe\_wna16.py 的 w4a16 段落已按此处理       |
| 9  | 标记丢失时按 prepared.layout 放行（只告警不拦截）                                                                                                                                                                                                                                   | 用户改动权重后未重新准备时可能算错          | 设计取舍：不限定用户行为，改动权重的核对责任在用户；告警明确提示重新准备           |
| 10 | prepared 与权重张量的内容可被原地修改                                                                                                                                                                                                                                                     | 原地改写后库无法发现                 | PyTorch 没有张量只读开关，返回副本会翻倍占显存；列为已知边界             |

