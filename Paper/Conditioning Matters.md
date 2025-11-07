---
type: paper
tags:
  - Diffusion
  - EmbodiedAI
  - DeepLearning
  - code/python
  - Robot
  - VLA
publish: arxiv preprint
pdf: "[[Paper/PDF/2505.11123v1.pdf]]"
rate: 🌟🌟🌟🌟
done: true
---
> [!note]- paper
![[Paper/PDF/2505.11123v1.pdf]]

Motivation: 尝试解决[[Diffusion Policy]]等方法对机器人action的训练效果低下的问题(尝试解决loss collapse问题)

> [!PDF|] [[2505.11123v1.pdf#page=1&selection=36,0,37,1|2505.11123v1, p.1]]
> > loss collapse
> 
> 损失崩塌: 由于condition差距过小, [[2505.11123v1.pdf#page=2&selection=73,44,75,53|导致模型忽略了condition]], 不学习条件概率$p(\text{action}|\text{condition})$而去学习边缘概率$p(\text{action})$:
> ![[2505.11123v1.pdf#page=4&rect=126,608,482,730|2505.11123v1, p.4]]
> 由于条件过于相似, 模型忽略了条件, 直接学习了"move"这个action. 均有0.5的概率进行向左或向右移动(忽略了指令的条件)
> 
> 数学推导: 根据[[2505.11123v1.pdf#page=4&selection=374,0,374,13|Loss Collapse]]部分的公式, 标准的[[Flow Matching]]的损失函数为:
> $$\mathcal L_{CFM}(\theta):=\mathbb E_{t,q(x_0),q(x_1,c),p_t(x|x_1,x_0)}\|v_\theta(t,x,c)-u_t(x|x_1,x_0)\|^2$$
> 在这个loss计算中, 需要提供这些内容: 条件$c$, 噪声采样$x_0$, 原始action $x_1$. 但是注意, 噪声分布$q(x_0)$与条件$c$无关.
> 
> 当模型无法区分两个相似的condition $c_1,c_2$时, 数学表示为$\forall c_1,c_2\in\mathcal C,\|v_\theta(t,x,c_1)-v_\theta(t,x,c_2)\|\leq\epsilon$时, loss函数的梯度会有:
> $$\|\nabla_\theta\mathcal L_{CFM}(\theta,c_1)-\nabla_\theta\mathcal L_{CFM}(\theta,c_2)\|\leq2(M+KD)\epsilon$$
> 其中:
> - 上限$\|\nabla_\theta v_\theta\|\leq M$
> - 上限$\|d\|\leq D$
> 
> 于是模型对相似condition的loss优化相同, 最终[[2505.11123v1.pdf#page=4&selection=412,3,413,14|目标loss函数会退化成边缘分布]], 学习的向量场[[2505.11123v1.pdf#page=4&selection=563,1,566,1|与输入的条件c无关]]:
> $$v*(t,x):=\mathop{\arg\min}_v\mathbb E_{c\in\mathcal C}\mathbb E_{z\sim\mu}\left[\|v(t,x)-u_t(x|x_1,x_0)\|^2\right]$$
> 
> 最终会导致在training的时候看起来模型能力比较好, 但是inference的时候发现模型没有学到任何成功的内容

 > [!PDF|] [[2505.11123v1.pdf#page=2&selection=89,3,106,17|2505.11123v1, p.2]]
> > Rather than adopting a standard Gaussian prior q(z), Cocos anchors the source distribution around the semantics of each condition q(z|c), theoretically preventing training loss collapse and forcing the policy network to remain responsive to condition inputs.
> 
> 为了解决上面说到的loss collapse的问题, 文章提出了一种 **co**ndition-**co**nditioned **s**ource distribution(cocos) 的方法: noise不再是一个标准的正态分布, 而是一个锚定在给定condition周围的一个分布$q(z|c)$

pipeline:
![[2505.11123v1.pdf#page=2&rect=105,605,495,733|2505.11123v1, p.2]]

> [!PDF|] [[2505.11123v1.pdf#page=5&selection=152,0,177,1|2505.11123v1, p.5]]
> > $q(x_0|c)=\mathcal N(x_0;\alpha F_\phi(\mathcal E(c)),\beta^2I)$
> 
> 这个是Cocos中创建与条件相关的噪声的方法.
> 
> 首先将language instructions和images提取embeddings:
> $$e=\mathcal E(c)$$
> 注意, 该步骤不参与loss的计算
> 
> 然后, 设计一个[[Deep Learning#Autoencoder (AE)|AE]], 有编码器($F_\phi$)和解码器($G_\phi$). 参考[[2505.11123v1.pdf#page=6&selection=174,15,175,64|这一部分]], AutoEncoder的Encoder和Decoder都是由一个single-layer的[[Transformer]]组成.
> 
> 由于文章中并没有给出Transformer层的具体架构, 因此根据[[2505.11123v1.pdf#page=2&rect=109,665,240,730&color=blue|pipeline]]猜测, 最可能的架构为:
> - T5-base和[[DINOv2]]提取的features拼接一个nn.Embedding的可学习的query进行Transformer layer([[Deep Learning#Self-Attention|self attention]] + [[Deep Learning#Multi-Layer Network|MLP]])的过程
> - 把query位置的Encoder输出作为condition(可能会使用MLP投影到相应维度), 用于噪声采样
> - 根据其他的embedding(T5和[[DINOv2]]的embedding对应的位置)送给Decoder进行Self Attention + MLP, 将输出与原始的embedding vector做[[Cosine Similarity|余弦相似度]]的loss

> [!PDF|] [[2505.11123v1.pdf#page=5&selection=207,25,207,47|2505.11123v1, p.5]]
> > autoencoding objective
> 
> 对Decoder重建得到的embedding vectors与原始输入的Feature Embeddings进行reconstruction loss, 用于训练Encoder:
> $$\mathcal L(\phi)=-\mathbb E_c\text{Sim}(G_\phi(F_\phi(\mathcal E(c)),\mathcal E(c))$$

> [!PDF|] [[2505.11123v1.pdf#page=5&selection=257,32,258,26|2505.11123v1, p.5]]
> > However, in practical scenarios, this two-step pipeline may introduce additional inflexibility. 
> 
> [[2505.11123v1.pdf#page=5&selection=256,45,257,31|default的settings]]是, 首先训练AE, 然后再固定AE的权重, 使用AE训练Flow Matching(或者说, Policy Model)
> 
> 但是使用2-stage的方法有一定缺点:
> - 不灵活: 无法针对困难的条件进行特调, 只是学习了一个平均的一个condition(针对输入平均, 没有针对难度进行特调)
> - 流程繁琐
> 
> 因此提出了一个端到端的训练策略. 但是由于在训练的时候, 会更新原始分布$x_0$, 导致得到的policy model不稳定, 于是提出了一个方法: EMA
> 
> > [!PDF|]- [[2505.11123v1.pdf#page=5&selection=264,29,264,56|2505.11123v1, p.5]]
> >  Exponential Moving Average
> > 
> > **指数移动平均 (EMA)** 是一种平滑技术，它通过维护一个模型的两个副本来解决训练不稳定的问题：
> >
> > 1.  **在线网络 (Online Network):** 正常接收梯度并快速更新的网络。
> > 2.  **目标网络 (Target Network):** 从不接收梯度，其权重是“在线网络”过去所有权重的一个**指数加权平均**。
> >
> > 它的工作机制是，在每次更新“在线网络”后，都通过以下公式极其缓慢地更新“目标网络”：
> > $$w_t=\tau w_{t-1}+(1-\tau)w'_t$$
> 
> 通过EMA算法更新权重, 使权重的变化尽量保持平滑.

![[2505.11123v1.pdf#page=5&rect=106,123,508,247|2505.11123v1, p.5]]
