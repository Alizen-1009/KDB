---
title: "并行投机解码(DFlash/DSpark)的快速理解与vLLM实测"
source: "https://mp.weixin.qq.com/s/9H8_PDcwMvMznOtJQ9ENZg"
author:
  - "[[kaiyuan]]"
published:
created: 2026-08-17
description: "并行投机解码在干什么，DFlash和DSpark怎么做的？先用基本原理把这两点讲清楚，再用vLLM上的实测看看它实际表现如何。"
tags:
  - "clippings"
---
kaiyuan InfraTech *2026年8月17日 07:30*

![图片](https://mmbiz.qpic.cn/mmbiz_gif/uIP3tuXZx8BXuw5wK7j3avmicib6aZVBqicxsN6ricR1AIiam4Jh59fsLhzU4cREAxrfxPqILpAuUfrVROyIugfOofqucCL4XR5XlfxQg6IPNibmw/640?wx_fmt=gif&from=appmsg&tp=webp&wxfrom=5&wx_lazy=1#imgIndex=0)

点击 **蓝字** ，关注我们

并行投机解码在干什么，DFlash和DSpark怎么做的？先用基本原理把这两点讲清楚，再用vLLM上的实测看看它实际表现如何。

**1\. 原理**

**1.1**

**计算模式**

理解并行投机解码的过程前，先简单看一下attention的计算应用中的两场景：

**a 词语接龙模式**

特点：自回归的生成，挨个吐字。也就是说没吐出第n个字之前，吐不出n+1个字。

LLM运行时，类似在做词语接龙，例如：

```makefile
题目：你__?___第一次迭代: 你好第二次迭代：你好酷
```

这类attention训练时会加上causal mask，避免当前字符看到之后的字符。

![图片](https://mmbiz.qpic.cn/sz_mmbiz_gif/uIP3tuXZx8BrCXdYJtkia2Yf2tIsiaTBuWhd1jpdjXGSia9pXZxDehc8FE4hxUNic4XtXfwZSzMLeF8JRkjmLT2HcQ0HgSsUoYp5sVk0Jk6KYxI/640?wx_fmt=gif&from=appmsg&tp=webp&wxfrom=5&wx_lazy=1#imgIndex=1)

**b 完型填空模式**

**特点** ：并行生成，一口气生成多个文字，LLM运行时类似在做完型填空：

```markdown
题目：我最近关注了_____的知乎账号。 答案：kaiyuan
```

Attention的训练时，读取整条sequence的数据，也就是说不用加mask。

![图片](https://mmbiz.qpic.cn/mmbiz_gif/uIP3tuXZx8BgyV6A1Am9rr0iaribibl8k0cR7uRIj7loSAmpXIibW8NiaAAHiawWtw3AmWogUqVgpHoPLE7b5hWRAl06fIEFFlfAricuOWPt1JEb2A/640?wx_fmt=gif&from=appmsg#imgIndex=2)

无causal mask、整段互相可见的attention，在Diffusion一类非自回归生成里很常见，图像生成里的DiT会对整张图的patch互相看，文本侧的diffusion language model也会一次并行填多个位置。对读LLM的同学来说，把它想成“完型填空”通常比直接说Diffusion更直观。

目前主流大语言模型选了自回归模式（词语接龙）：训练带causal mask，decoding时按位置串行吐token。非自回归也能并行出字，但工程上词语接龙更成熟，生成质量也更稳，所以推理默认仍是串行。

总的来说：“词语接龙”和“完型填空”两种运算模式各有优劣，但对于本文来讲，我们需要记住其最明显的差异： **单次迭代运算生成的tokens数量不同** ，词语接龙是1个token，而完形填空是n个token。

**1.2**

**投机解码**

投机解码的逻辑是用一个参数量更小的模型（生成字符速度快），每次多生成几个字符，让主模型判断字符是不是可行的，从而提速decoding的生成速度。

![图片](https://mmbiz.qpic.cn/mmbiz_png/uIP3tuXZx8C4eeSICFFKfnoaJxYpT5akXh1TUiciaeBL0MkLqCdPU3icrfCic1aMAFTekRtUcNpHGArlqxpHibsh64ecjJoqZ3m4VfhmvpDbmd6U/640?wx_fmt=png&from=appmsg&watermark=1#imgIndex=3)

小模型计算draft，大模型校验

投机解码基础参考： [搞懂投机推理难？这篇总结+框架实践帮你快速上手](https://mp.weixin.qq.com/s?__biz=MzYyMjA5NzMwOQ==&mid=2247486643&idx=1&sn=3e73a11358d4aef47bdde9f939165002&scene=21#wechat_redirect)

草稿模型也是LLM只是参数更小，但它采用的方式一般也是 **自回归模式** ，比如常见的 **Eagle** 。

自回归模式意味着其tokens是用“词语接龙”的方式生成，草稿模型猜测的tokens长了精度就降低，若增加草稿模型的大小，又会出现 **耗时太长** 的问题。

所以工程上，有同学就开始尝试完型填空的草稿模型，让草稿模型一次吐多个词。于是就有了另一种并行处理的方案，如： **DFlash、DSpark** 。

**1.3**

**DFlash**

DFlash采用的就是并行草稿模型。因为草稿模型的能力没有主模型强，生成token过多时被采纳可能性会降低。为了解决这个问题，提高draft model的能力，在DFlash中的解决方案：抽取主模型若干层的hidden，融合成一个额外的上下文信息（记作），再注入到草稿模型每一层的Attention里。

DFlash <sup>[1]</sup> 的原理如下图:

![图片](https://mmbiz.qpic.cn/mmbiz_png/uIP3tuXZx8CBf3uL5zicGY5icuuvWktrhtunFeRg59GibdEuarU8SK0jyXqE0yPMicp5TAj9tO00Wic5IEibEced8U2icuJJZKAZKlOSibgBdBLwQWQ/640?wx_fmt=png&from=appmsg&watermark=1#imgIndex=4)

图片源自DFlash github

**计算步骤：**

1. 主模型（target model）接收输入“Diffusion is good”，预测生成第一个token“for”，将其作为草稿模型的anchor；草稿侧再配上若干mask，表示需要并行填空的位置；
2. 抽取主模型一些中间层的输出（hidden states），融合成上下文信息𝐻 <sub>𝑐𝑡𝑥</sub> ；
3. 在Attention计算时，把𝐻 <sub>𝑐𝑡𝑥</sub> 投影后拼进 **K/V的前半段** ，后半段是Draft自身token侧的表示𝐻 <sub>𝑑</sub> ；Query仍然只来自𝐻 <sub>𝑑</sub> ，去读\[𝐻 <sub>𝑐𝑡𝑥</sub> ||𝐻 <sub>𝑑</sub>\]；
4. 得到该层输出，并以此类推算完所有Draft层；
5. 最后用与主模型共享的LM head，从mask位置采样得到草稿输出，例如“for speculative decoding ”。

在此之后，主模型的校验过程与常规的投机推理过程类似。

DFlash实现过程中，第2/3步有些细节大致如下：

- Target先对自己的前缀做forward，抽出若干层hidden，融成𝐻 <sub>𝑐𝑡𝑥</sub>
- Draft每一层做Attention时，把𝐻 <sub>𝑐𝑡𝑥</sub> 投影后拼进K/V的前半段，后半段才是Draft自己的𝐻 <sub>𝑑</sub>
- Query仍然只来自Draft的token侧（𝐻 <sub>𝑑</sub> ），去读\[𝐻 <sub>𝑐𝑡𝑥</sub> ||𝐻 <sub>𝑑</sub>\]

投机解码需要在草稿模型的算力消耗与精度之间寻找平衡。如果用三个维度来看DFlash特点：

- **算得快** ：由于采用diffusion的完型填空模式，单次能吐出更多预测字符；
- **算得准** ：用主模型的中间数据来提升草稿模型的能力，接受长度可以做得更长，但随着块变长，后缀准确性依然会衰减；
- **整体提速** ：选取合适的生成长度，提升整体的吞吐量。

像DFlash这种并行投机解码，虽然一次能获得更多的字符串，但实践时可能会出现：一长串草稿字符给主模型校验，结果被接受的字符并不多，导致算力浪费。而且把偏decode的运算拉成一次要验很多token的forward，对部署形态也带来了挑战。

**1.4**

**DSpark**

DSpark <sup>[2]</sup> 为了解决接受字符数量不确定、以及长块验证可能浪费算力的问题，对DFlash做了进一步的工程优化。如下图所示：

![图片](https://mmbiz.qpic.cn/sz_mmbiz_png/uIP3tuXZx8CZFJwxibMvoKdOgjAmj5SCckI2u6qcjkHxeiaNA8icsN9OvicGKEhsKspyHIVSFPozdticvc3icFTlF0ia3SdkxoCsAojBljwPSJNV9Q/640?wx_fmt=png&from=appmsg&watermark=1#imgIndex=5)

图片源自DSpark论文

**步骤：**

- 1\. 主模型输入字符“ABC”，生成字符“D”；
- 2.1 **parallel block处理** ：将D字符以及掩膜作为并行生成模块（diffusion）的输入，计算完后得到多个位置的中间logits；
- 2.2 **sequential block处理** ：这些中间logits再通过一个串行模块（RNN或Markov）从左到右逐个生成tokens，即“EFGH”，同时计算每个token的置信度confidence（图中的，表示该token被主模型采纳的可能性）；
- 2.3 **筛选** ：根据2.2的输出，结合硬件当前负载，决定本轮验证多长。机器越空闲、字符置信度越高，验证长度往往越长，反之亦然。图中被丢弃的字符是“H”；
- 3.1 token“EFG”进入主模型验证；
- 3.2 token“G”未通过校验，接受“EF”，并以主模型新生成的“G\*”作为本轮bonus。

注：DSpark仍然使用主模型中间层输出，做法类似DFlash；只是其论文架构图里没有单独画出这一条。

对于步骤2.3的筛选，Hardware-Aware Prefix Scheduler可以概括成一句话：草稿可以很长，但不一定整段都拿去让Target验证；按“还值得验吗”和“现在机器忙不忙”裁出一段前缀。

其中关键的筛选动作大致分三步。

**step1 先有每位的条件置信度**

Confidence头给出𝑐 <sub>𝑘</sub> ：在前面都已接受的前提下，第𝑘个草稿还能过验证的概率。前缀存活概率：

 $a_j=\prod_{i\le j}c_i$ 

𝑎 <sub>𝑗</sub> 越大，说明“验到第𝑗位时整段前缀仍有希望都过”的把握越大；越往后通常越小。

**step2 用硬件曲线估计“验得越长是否越划算”**

引擎事先profile一条SPS(𝐵)（Steps Per Second，即每秒能跑多少步forward）：一次forward的batch里有𝐵个token时，大约每秒能跑多少步。若本轮有𝑅个请求，每个请求验证长度为ℓ𝑟，则大致：

- 验证batch大小𝐵=∑ <sub>𝑟</sub> (1+ℓ𝑟)（（含各请求自身要占的那一个位置）
- 期望接受量𝜏会随多验的𝑎 <sub>𝑟,𝑗</sub> 增加
- 吞吐估计Θ=𝜏⋅SPS(𝐵)

多验一个token：𝜏可能涨一点，但𝐵变大，SPS往往降低。Scheduler就是在找让Θ尽量大的那组ℓ。

**step3 贪心扩展 + 早停（真正的筛选）**

把所有“再多验一位”的候选按𝑎 <sub>𝑟,𝑗</sub> 从高到低排。从空前缀开始，每次挑当前存活概率最高的那一位扩进去，更新𝐵、𝜏、Θ：

- Θ变好：接受这次扩展，继续
- Θ不再升：立刻停，当前各请求的前缀长度就是ℓ <sup>∗</sup>

只把前ℓ <sup>∗</sup> 个草稿（即图中的“EFG”）送给主模型；后面的后缀直接丢掉（即图中的“H”），不占验证算力。

理解上述过程的数值变化可参考 <sup>[3]</sup> ：

https://github.com/CalvinXKY/InfraTech/blob/main/llm\_infer/dflash\_dspark\_principle.ipynb

**2 vLLM上实测**

目前主流推理引擎中，并行投机推理方案DSpark与DFlash均可直接部署。本节在同一硬件与同一目标模型上，对比二者、以及Baseline（无投机解码）的吞吐与精度表现。

测试环境：

- A800，8×NVIDIA A800-SXM4-80GB；
- 目标模型Qwen3-4B；draft分别为DSpark（block7）与DFlash（b16）；
- 推理引擎为 **vLLM 0.26.0** （镜像vllm/vllm-openai:latest）。

**2.1**

**部署命令**

**DSpark**

```apache
docker run -d --name dspark-test \  --gpus '"device=0,1,2,3"' \\
  -p 8000:8000 \  -v /root/local_models:/models \  vllm/vllm-openai:latest \\
  --speculative-config '{"method":"dspark","model":"/models/dspark_qwen3_4b_block7","num_speculative_tokens":4}' \  --dtype bfloat16 \\
  --port 8000
```

**DFlash**

```apache
docker run -d --name dflash-test \  --gpus '"device=4,5,6,7"' \\
  -p 8001:8000 \  -v /root/local_models:/models \  vllm/vllm-openai:latest \\
  --speculative-config '{"method":"dflash","model":"/models/Qwen3-4B-DFlash-b16","num_speculative_tokens":7}' \  --dtype bfloat16 \\
  --port 8000
```

**Bseline 无推测解码服务**

```apache
docker run -d --name baseline-test \  --gpus '"device=4,5,6,7"' \\
  -p 8002:8000 \  -v /root/local_models:/models \  vllm/vllm-openai:latest \\
  --dtype bfloat16 \\
  --port 8000
```

上述命令对应num\_speculative\_tokens交叉配置（DSpark=4、DFlash=7）。原参数组为DSpark=7、DFlash=4。

**评估脚本运行**

评估脚本代码详细内容参考：dflash\_dspark\_principle.ipynb <sup>[4]</sup> 第二章，执行命令：

```apache
python3 eval_reference_script.py \  --data-dir /root/eval_data \\
\
  --test-throughput \  --output-dir /root/eval_data \  --dataset all
```

**2.2**

**主对比结果**

**GSM8K数学推理（250题）**

| 服务 | 正确数/总数 | 准确率 | 平均延迟 |
| --- | --- | --- | --- |
| DSpark（num\_spec=4） | 88⁄250 | 35.2% | 0.75s |
| DFlash（num\_spec=7） | 79⁄250 | 31.6% | 0.84s |

DSpark较DFlash高3.6pp，平均延迟降低约10.7%。

**MMLU多任务语言理解（250题）**

| 服务 | 正确数/总数 | 准确率 | 平均延迟 |
| --- | --- | --- | --- |
| DSpark（num\_spec=4） | 72⁄250 | 28.8% | 0.24s |
| DFlash（num\_spec=7） | 69⁄250 | 27.6% | 0.27s |

DSpark较DFlash高1.2pp，平均延迟降低约11.1%。MMLU差距小于GSM8K，在250样本下显著性有限。

**2.3**

**参数交叉消融**

主对比中两侧默认 **num\_speculative\_tokens** 并不相同。为排除“谁参数更大谁更快”的干扰，再做一轮参数互换：DSpark取7与4，DFlash取4与7，观察输出。

**精度**

| 数据集 | DSpark（num\_spec=7） | DFlash（num\_spec=4） | DSpark（num\_spec=4） | DFlash（num\_spec=7） |
| --- | --- | --- | --- | --- |
| GSM8K | 35.6% | 32.0% | 35.2% | 31.6% |
| MMLU | 27.6% | 27.2% | 28.8% | 27.6% |

**吞吐量**

| 配置 | DSpark（tok/s） | DFlash（tok/s） | DSpark/DFlash |
| --- | --- | --- | --- |
| 原参数（DSpark=7，DFlash=4） | 584.07 | 448.92 | 1.30x |
| 交叉参数（DSpark=4，DFlash=7） | 561.11 | 479.56 | 1.17x |
| 变化 | \-23.0（-3.9%） | +30.6（+6.8%） |  |

本测试的数据可以归纳为三点：

1. 精度基本不受num\_speculative\_tokens影响：同方法换参后变化不超过约1.2pp，落在后续提到的vLLM batch效应波动范围内。
2. 吞吐量受该参数影响，但幅度有限（均小于7%）：DSpark从7降到4，吞吐584降到561；DFlash从4升到7，吞吐449升到480，方向符合“每步可接受token数增减”的预期。
3. 两种配置下DSpark均快于DFlash（约1.17x到1.30x），优势不依赖某一侧单独调大num\_spec。

**2.4**

**含Baseline对比**

![图片](https://mmbiz.qpic.cn/mmbiz_png/uIP3tuXZx8D4RFkLPFiaTdOejphOQk33h2P7lqOXiaXVaID1QHZmcarRIichgYTWMzDoyodEeOEib0AHGqhYmPsdTaiatot33ceSEgGUrK36F6HQ/640?wx_fmt=png&from=appmsg&watermark=1#imgIndex=6)

精度上，MMLU各配置差异多在1pp量级；GSM8K看似有几分差距，但Baseline自身两次评测已波动5.2pp（29.2%与34.4%）。该波动来自vLLM不同batch组合下的浮点累加顺序差异，在temperature=0时仍可能改变个别token选择。

![图片](https://mmbiz.qpic.cn/mmbiz_png/uIP3tuXZx8BJOXiaabE5pzpBqibfuNhqrFauDnB2VMUjlnbZb7OfOOlicnibSEjfJNttNG4fmiaKsXW1lbHWsskmmEoN6cMXrFN912Y3zuvFgjdQ/640?wx_fmt=png&from=appmsg&watermark=1#imgIndex=7)

吞吐上，DSpark相对Baseline约2.45x到2.55x，DFlash约1.96x到2.09x；同参对比时DSpark仍领先DFlash约20%量级。

汇总：

| 指标 | DSpark（num\_spec=7） | DSpark（num\_spec=4） | DFlash（num\_spec=4） | DFlash（num\_spec=7） | Baseline |
| --- | --- | --- | --- | --- | --- |
| GSM8K | 35.6% | 35.2% | 32.0% | 31.6% | 29.2% / 34.4% |
| MMLU | 27.6% | 28.8% | 27.2% | 27.6% | 28.0% / 29.2% |
| 吞吐量 | 584 tok/s | 561 tok/s | 449 tok/s | 480 tok/s | 229 tok/s |
| vs Baseline | 2.55x | 2.45x | 1.96x | 2.09x | 1.0x |

参考:

- \[1\]https://github.com/z-lab/dflash
- \[2\]https://arxiv.org/pdf/2607.05147
- \[3\]https://github.com/CalvinXKY/InfraTech/blob/main/llm\_infer/dflash\_dspark\_principle.ipynb
- \[4\]https://github.com/CalvinXKY/InfraTech/blob/main/llm\_infer/dflash\_dspark\_principle.ipynb

想深耕AI Infra领域？欢迎访问InfraTech库！内容涵盖大模型基础、PyTorch/vLLM/SGLang框架入门、性能加速等核心方向，配套50+知识干货及适合初学者的notebook练习： **https://github.com/CalvinXKY/InfraTech**

扫码关注我们，了解更多AI Infra基础知识。

![图片](https://mmbiz.qpic.cn/mmbiz_jpg/uIP3tuXZx8CExibG7alrmsJyZGQicZI71qribynwtt8vrAGDP8DeTxRh6lo2hia5qfSKrIaMicQiaaAdDoicT4iajD0YElIwm392bW6vYP3BEYicia7oQ/640?wx_fmt=jpeg&from=appmsg&watermark=1#imgIndex=8)

推理技术与知识分享 · 目录