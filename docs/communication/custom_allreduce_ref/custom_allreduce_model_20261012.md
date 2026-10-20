<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# Qwen3.5 模型中的 CustomAllreduce 精度回归

[返回最新用法与性能](../custom_allreduce.md)

2026-10-12，在 gfx936、TP2 的 Qwen3.5-27B + NEXTN 抽样模型回归中，
未观察到本次 CAR 优化导致的精度退化：优化前、最终off、最终auto及禁用CAR
四组的对应文本、token序列和完整返回logprobs字段相同，所测题目的数学答案正确。
该结论限于下述用例，不代表完整模型评测或gfx938模型已通过。

## 环境和启动

使用gfx936（BW200 / UBB BW1000，80 CU）、2张GPU，SGLang `0.5.18+dtk2604.torch2110.2610082135.g7fa772`、
Torch `2.11.0+dtk2604.2609291046.ge12687`。27B为dense BF16模型；FP8 E5M2设置用于KV cache，
所采普通CAR张量仍为BF16。使用以下模型配置，未附加35B历史运行中的量化设置：

将`MODEL_PATH`设为本地Qwen3.5-27B模型目录。

```bash
export SGLANG_USE_FUSED_TOPK_SOFTMAX=1
export SGLANG_USE_LIGHTOP=1
export SGLANG_USE_CAUSAL_CONV1D=1
export SGLANG_USE_AITER_LINEAR_ATTN=1
sglang serve \
  --model-path "$MODEL_PATH" \
  --attention-backend fa3 --mm-attention-backend fa3 \
  --speculative-algorithm NEXTN --speculative-num-steps 3 \
  --speculative-eagle-topk 1 --speculative-num-draft-tokens 4 \
  --tp-size 2 --pp-size 1 --page-size 64 \
  --mamba-radix-cache-strategy extra_buffer --kv-cache-dtype fp8_e5m2 \
  --tool-call-parser qwen3_coder --reasoning-parser qwen3 --trust-remote-code
```

复现时可设置`HIP_VISIBLE_DEVICES=0,1`选择两张空闲GPU，并使用独立缓存和loopback端口。
三组CAR增加`--custom-all-reduce-backend aiter`、`AITER_AR_TRANSPORT=ipc`；
RCCL控制使用`--disable-custom-all-reduce`。
`AITER_AR_SMALL_MESSAGE=off`仍为默认，`auto`启用已准入的小载荷策略。
测试显式请求reg_capture=true，由现有安全保护转为false，未开启直接注册。
target verify和draft decode实际使用Graph，prefill为eager；GDN实际选择Triton，
不能仅凭环境变量宣称启用了AITER GDN。

优化前为冻结的`e525ba10`基线，最终代码为`0f4ecd3f`。
每组使用匹配的CAR Python/native，其余算子版本保持一致；实际CAR路径和Graph调用已核验。

## 输出与数值结果

四组各请求篮球题、乘法题和篮球题重复，共12次主对照；接口为`/v1/completions`，
temperature=0、max_tokens=300、logprobs=5。

| 检查 | 结果 |
|---|---|
| 主对照请求 | 12/12 HTTP 200 |
| 四组对应文本、token及完整返回logprobs字段 | 全部相同，token logprob最大差0 |
| 篮球题及重复 | A队29人，B队21人；260 tokens，正常stop；重复相同 |
| 17 × 23 | 正确答出391；随后继续生成其他题目，300 tokens时length结束 |

乘法题使用原始completion提示，保留其额外续写；未把截断或HTTP成功本身当成
精度通过依据。未比较全词表logits。独立缓存使首请求包含编译，响应耗时不作为
CAR或模型性能数据。

另外启动最终off/auto诊断，采集少量真实模型eager调用和Graph replay的两rank
输入/输出。抽样从HTTP模型发现接口就绪后开始，可能包含服务内置热身；没有逐层、
逐token覆盖保证。参考为rank0 FP32 + rank1 FP32，再转BF16 RNE，保持既有FP32 FTZ。

| 模式 | 通信组数 | rank输出数 | 检查元素数 | 位差异 | NaN/Inf输出 |
|---|---:|---:|---:|---:|---:|
| off | 52 | 104 | 4,202,496 | 0 | 0 |
| auto | 52 | 104 | 5,971,968 | 0 | 0 |

Graph抽样载荷：`[10240, 20480, 40960, 81920]` bytes；
off eager抽样载荷：`[589824]` bytes；
auto eager抽样载荷：`[589824, 2359296]` bytes。
两模式采到的eager尺寸不同，分别对各自输入计算参考，不把不同输入的位摘要作A/B比较。
有效off/auto、IPC、注册false、16字节对齐均已确认。
这些诊断增加复制、改变时序，只是数值抽样，不是性能或完整竞态证明。

## 保留的35B历史配置结果

此前按历史方式运行Qwen3.5-35B-A3B-Channel-INT8-w8a8，使用BF16、w8a8_int8、
EAGLE 3 steps/topk1/4 draft tokens、fa3、page64、FP8 E5M2 KV、
chunked-prefill16384、mem-fraction0.9。四组文本/token/logprobs同样逐项相同，
但篮球题重复“A队多”、乘法题重复数字，全部达到300 tokens，**整模型语义失败**。
其off/auto真实通信抽样各3,096,576元素零位差异，未显示CAR调优引入该异常；
具体原因未定位，不能用新的27B结果覆盖该失败。

## 范围和证据

本次仅验证gfx936 TP2、两道题及重复请求，未覆盖完整模型评测、模型吞吐、
TP4/8模型或gfx938模型。此前两架构CAR及fused AR RMS算子回归见
[优化结果](custom_allreduce_optimized_20261011.md)，算子证据与模型证据分别成立。
模型配置/index/tokenizer小文件采集SHA，权重分片仅记录路径、大小与mtime。

包含版本、数值统计和范围的机器可读结果，与原始日志、响应/logprobs、张量和构建来源一起单独归档，不随源码分发。
