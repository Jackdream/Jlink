---
title: "分层强化学习算法的思想更贴近解决复杂的环境，为什么这个方向依然这么冷门？ - XuanAxuan 的回答"
source: "https://www.zhihu.com/question/264126494/answer/2449015827"
author:
  - "[[XuanAxuan爱生活爱学习～​ 关注]]"
  - "[[知乎用户​新知答主]]"
  - "[[知乎用户zKk5cV​ 关注]]"
published:
created: 2026-04-16
description: "我对分层强化学习的最初了解来源于一篇与我课题相关的论文《Drone-Cell Trajectory Planning and Resourc…"
tags:
  - "clippings"
---
## 分层强化学习算法的思想更贴近解决复杂的环境，为什么这个方向依然这么冷门？

作者：XuanAxuan  
链接：https://www.zhihu.com/question/264126494/answer/2449015827  
来源：知乎  
著作权归作者所有。商业转载请联系作者获得授权，非商业转载请注明出处。  
  

> 我对分层强化学习的最初了解来源于一篇与我课题相关的论文[《Drone-Cell Trajectory Planning and Resource Allocation for Highly Mobile Networks: A Hierarchical DRL Approach》](https://zhuanlan.zhihu.com/p/431249260)，刚看完论文之后觉得分层这一思想对于实际应用非常有意义，于是我开始了对分层强化学习这一领域的学习，一方面，我阅读了一些比较经典的分层强化学习论文；另一方面，我也查找了更多分层强化学习在通信领域的应用。把它们都读完之后我才明白，在通信领域中用到的分层和主流的分层强化学习算法实际上完全不是一回事。这就导致我目前对于分层强化学习到底要怎么用在我的课题中这一问题还处于非常迷茫的状态，为了捋一捋思路，今天就来对之前读的论文做一个小结吧~  
> p.s 以下内容都是我个人的理解，如有错漏之处，还请各位在评论区指出来~

这篇文章是一个小结，如果想看每篇论文的完整解读，可以点击下面的链接：

[【分层强化学习】The Option-Critic Architecture 阅读笔记](https://zhuanlan.zhihu.com/p/430471198)

[【迁移强化学习】UVFA：值函数在Goal-conditioned问题中的扩展](https://zhuanlan.zhihu.com/p/500741089)

[【深度强化学习】Hindsight Experience Replay（HER）：一种对抗稀疏奖励的经验回放技术](https://zhuanlan.zhihu.com/p/501043736)

[【分层强化学习】H-DQN：Hierarchical Deep Reinforcement Learning: Integrating Temporal Abstraction阅读笔记](https://zhuanlan.zhihu.com/p/430886508)

[【分层强化学习】FeUdal：一种分层的神经网络结构与训练模型](https://zhuanlan.zhihu.com/p/492227096)

[【分层强化学习】HIRO：一种off-policy的分层强化学习算法](https://zhuanlan.zhihu.com/p/497424021)

[【分层强化学习】HAC：一种多层级的分层强化学习算法](https://zhuanlan.zhihu.com/p/498703656)

首先我们要弄清楚为什么要用分层强化学习呢？我自己原本对于分层的直观理解是，复杂问题的状态与动作空间过大，直接训练可能学不出来，所以采取分层策略把动作空间分解，可以有效地提升学习效率。这就有点类似于人类学习的过程，为了学会做一道菜，得学会洗菜、切菜、炒菜等等步骤，直接学一道菜可能是很复杂的，但是把做菜这一过程简化成一个个小的步骤，学习的过程就变得简单了许多。尽管这样的理解看起来很合理，也是我最初想要了解分层强化学习的原因，但看了论文之后，我发现这似乎并不能准确地表明分层强化学习的真正动机。实际上，分层强化学习解决的是强化学习中的 **稀疏奖励（sparse reward）**问题：当环境奖励过于稀疏时，智能体可能长期都没有办法获得具有正奖励的样本，给值函数和策略的学习带来了困难。通过分层把策略分为不同层级的子策略，每个子策略在学习的过程中会得到来自上一层级传递来的奖励，这样可以大大提升 **样本的利用效率（sample efficiency）**。

目前的分层强化学习主要可以分为两大类，第一类是基于 **option** 的，第二类是基于 **goal** 的。实际上这两种方法并没有本质上的区别，这里的 **option** 表示的是一种具有 **时序抽象（temporal abstraction）**的策略，可以说是抽象出来的上层策略，这是策略层面上的定义；而 **goal** 则是目标层面上的定义，即智能体需要达到什么目标，每一层的不同目标同样对应着一个不同的子策略，这里的子策略其实就是option。依然拿做菜举例，为了做完一道菜，我们需要选择洗菜、切菜、炒菜，这里洗菜、切菜、炒菜均属于option，而把才洗干净、切细、炒熟则属于goal目标，可以看出两者是紧密联系的。总体来说，几乎所有的分层强化学习都是，上层控制器在较长的时间跨度里选择option/goal，下层控制器在较短的时间跨度里根据option/goal选择action。分层之所以能够提升样本效率，是因为上层控制器给下层控制器提供goal/option的同时还会根据下层控制器的策略好坏反馈一个对应的 **内在奖励（intrinsic reward）**，这就保证了即便在外部奖励为0的情况下，下层控制器依然能够获得奖励，从而一定程度上缓解了奖励稀疏的问题。

接下来，我将分别对这两个类别中的一些经典分层强化学习算法进行总结。

## **基于option的分层强化学习**

在基于option的分层强化学习中，上层控制器根据上层策略选择options，下层控制器根据所选择的option所对应的策略选择action，从而实现分层。

### **1. Option-Critic: The Option-Critic Architecture**

[![](https://picx.zhimg.com/v2-7976c05bfaf8e3526aa61e0716078d34.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【分层强化学习】The Option-Critic Architecture 阅读笔记130 赞同 · 6 评论](https://zhuanlan.zhihu.com/p/430471198) 文章

![](https://pica.zhimg.com/80/v2-dfb5b9d3dbdb2c6590c5a3ce79897586_720w.webp?source=2c26e567)

Sutton最早在论文《Between MDPs and semi-MDPs: A framework for temporal abstraction in reinforcement learning》提出了**半马尔科夫过程（Semi-Markov Decision Process）**与**option框架**，而这篇论文则是将option框架与深度强化学习结合起来提出了[option-critic](https://zhida.zhihu.com/search?content_id=475359378&content_type=Answer&match_order=1&q=option-critic&zd_token=eyJhbGciOiJIUzI1NiIsInR5cCI6IkpXVCJ9.eyJpc3MiOiJ6aGlkYV9zZXJ2ZXIiLCJleHAiOjE3NzY0ODYwMjksInEiOiJvcHRpb24tY3JpdGljIiwiemhpZGFfc291cmNlIjoiZW50aXR5IiwiY29udGVudF9pZCI6NDc1MzU5Mzc4LCJjb250ZW50X3R5cGUiOiJBbnN3ZXIiLCJtYXRjaF9vcmRlciI6MSwiemRfdG9rZW4iOm51bGx9.3wqdwKWWj9HXXKQWym2bPw4qQF6cuekDe77jEMRglwA&zhida_source=entity)算法。在这篇论文中，option实际上就是子策略，但option本身并没有什么具体含义，本文只是明确了有几个option。在本文所提出的算法中，上层控制器在一个较长的时间跨度上选择下层策略用哪个option，这就是 **policy over options**，每个option对应着一个下层策略，即 **intra-option policy**，下层控制器则是在较短的时间跨度里根据所选择option对应的intra-option policy选择动作action，这样下来就实现了分层控制。整个网络通过端到端的方式进行训练，上层控制器与下层控制器之间不会传递任何内部奖励。

这里的option到底是什么完全靠智能体自行学出来，只有option的数目是一个超参数，这种对于option或者goal的自动学习似乎是分层强化学习中一个比较主流的想法，论文的作者们都提出人为设计option和goal是一件非常困难的事情，但在一些实际问题中，我们确实是有先验知识的，这种情况下是不是明确一下option或者goal的定义会更好呢？

总结来说，本文对于option框架下各类强化学习概念的重新定义，以及对于贝尔曼方程与策略梯度定理在分层强化学习中的再推导对我们理解分层强化学习具有很大的指导意义，阅读完这篇论文，基本上就能够对基于option的分层强化学习有一个比较好的理解了，因此我非常推荐大家阅读一下这篇论文。

## **基于goal的强化学习**

在介绍基于goal的分层强化学习算法之前，我首先推荐大家了解一下goal-conditioned问题下的两个算法：UVFA与HER，虽然这两个算法均不属于分层强化学习算法，但它们所建立的goal-conditioned框架能够帮助我们更好的理解分层强化学习中goal这一概念，而HER中针对稀疏奖励提出的解决方案对于分层强化学习也有很强的借鉴意义。

### **2. UVFA: Universal Value Function Approximators**

[![](https://picx.zhimg.com/v2-7c09b0ec0696d4bdd2fb553ce4b1ec73.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【迁移强化学习】UVFA：值函数在Goal-conditioned问题中的扩展28 赞同 · 9 评论](https://zhuanlan.zhihu.com/p/500741089) 文章

![](https://picx.zhimg.com/80/v2-e3701d3bfeda6fa2dfb0f3606f38f189_720w.webp?source=2c26e567)

本文的最大贡献是将强化学习中非常重要的值函数扩展到了目标空间，即把原本的 V(s)V(s) 与 Q(s,a)Q(s,a) 扩展成了 V(s,g)V(s,g) 与 Q(s,g,a)Q(s,g,a)。对于目标如何选取，本文没有讨论，而是考虑了一种最为简单的情况：**目标空间即为状态空间，目标即为达到某一特定状态**，当目标实现时奖励为1，否则为0。针对同时定义于状态空间与目标空间的值函数，本文针对性地设计了一种 **two-stream** 的网络结构，从而能够充分利用状态与目标之间结构上的相似性。在上图中，ϕ\phi 与 ψ\psi 均为神经网络，而 hh 则为简单的点乘。为了训练上述网络结构，本文提出两种方案，一种是利用矩阵分解与Horde算法的 **two-stage** 监督学习方案，分别学习 ss 与 gg 到各自embedding向量 ϕ(s)\phi(s) 与 ψ(g)\psi(g) 之间的映射关系，以及 ϕ(s)\phi(s) 与 ψ(g)\psi(g) 到值函数 V(s,g)V(s,g) 之间的映射关系； 另一种则是直接用强化学习的bootstrapping端到端地训练整个网络参数，但作者指出强化学习方案不够稳定。

本文所提出的网络结构和对应训练方法都是比较新颖的，但是所涉及到的矩阵分解等算法实操起来可能会有些困难，因此个人认为这篇论文最大的意义还是在于将值函数扩展到了目标空间，这一扩展也被引用到了后续的一些工作中。

### **3. HER: Hindsight Experience Replay**

[![](https://pic1.zhimg.com/v2-832d626f0a79879e74a5a38c4edd9503.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【深度强化学习】Hindsight Experience Replay（HER）：一种对抗稀疏奖励的经验回放技术55 赞同 · 11 评论](https://zhuanlan.zhihu.com/p/501043736) 文章

本文针对的是一种特殊场景：环境中只存在即为稀疏的二元奖励，该奖励用于表示目标是否完成，即只有任务完成的时候智能体才会得到一个奖励，这种环境下奖励过于稀疏，导致策略的学习十分困难。为此本文提出了一种经验回放技术HER。HER以UVFA为基础，沿用了goal-conditioned框架，其处理稀疏奖励的思想其实非常简单：在off-policy算法中，目标只会影响transition的动作，而不会影响状态之间的动态转移，因此我们可以把经验回放池中transition的原始goal替代成对应episode已经实现过的状态，奖励也就变成了完成目标所能得到的奖励，这样就能够保证回放池中总是有足够数量的正奖励样本。有点类似事后诸葛亮的感觉：因为该目标达到过了，所以将原本设定的目标替换成已经实现的目标。

该方法虽然看似十分简单，但是对于奖励只能表示目标是否实现的这一类稀疏奖励问题十分有效，推荐大家读一读。

## **基于goal的分层强化学习**

在基于goal的分层强化学习中，上层控制器在一个较长的时间跨度上根据上层策略选择一个goal，而下层控制器则在一个较短的时间跨度上根据所选择的goal以及下层策略选择action，目标是实现goal。因此，一个十分关键的问题是——**如何定义goal**？在上一节所介绍的UVFA与HER算法中，目标空间即为状态空间，目标就是达到某一特定的状态。实际上对于目标，不同的论文有不同的定义方法，因此在介绍每篇论文时，我将首先明确论文中goal的具体含义，然后再简单介绍论文工作。

### **4. H-DQN: Hierarchical Deep Reinforcement Learning: Integrating Temporal Abstraction**

[![](https://pic1.zhimg.com/v2-8e9e7e4a0bf87a17b6a8336a67a1c697.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【分层强化学习】H-DQN：Hierarchical Deep Reinforcement Learning: Integrating Temporal Abstraction阅读笔记93 赞同 · 6 评论](https://zhuanlan.zhihu.com/p/430886508) 文章

![](https://picx.zhimg.com/80/v2-1df34e2e022da215985011a282c121c9_720w.webp?source=2c26e567)

本文的目标是针对特定场景 **人为定义** 的，具体而言，在Montezuma's Revenge游戏中，需要通过左上角和右上角的门，才能获得300奖励，在此之前，需要先获得钥匙，得到100奖励。因此，在该游戏中的其他位置，智能体都无法获得奖励，是典型的稀疏奖励问题。为此，本文将游戏中一些特定的物品作为目标：左上角的门、右上角的门、中间的梯子、左下角的梯子、右下角的梯子、钥匙。如果智能体到达了一个物品，就说明它实现了该目标。

在H-DQN中，上层控制器以较长的时间跨度根据上层策略选择一个goal，下层控制器则以较短的时间跨度选择action。上层策略和下层策略都以DQN算法为基础，其中上层策略根据外部奖励进行更新，下层策略则根据上层控制器传递下来的内部奖励进行更新，这里内部奖励的制定方式是，当上层控制器设定的目标完成时，内部奖励为一个正数，否则为0。

H-DQN是我看过的分层论文里唯一一个人为定义目标的，大多数论文都提出人为定义目标是非常困难的，因此更加青睐于让智能体自行学习目标。但在我看来，在许多实际场景中，我们实际上具有非常多先验信息，这个时候人为定义目标或许比让智能体找目标更为高效。

![](https://pic1.zhimg.com/80/v2-af3e314b1957b17b48f0c9a1411720ec_720w.webp?source=2c26e567)

### **5. FeUdal: FeUdal Networks for Hierarchical Reinforcement Learning**

[![](https://pica.zhimg.com/v2-cd73b33f30cdf7a04f14eeb01f751759.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【分层强化学习】FeUdal：一种分层的神经网络结构与训练模型18 赞同 · 0 评论](https://zhuanlan.zhihu.com/p/492227096) 文章

![](https://picx.zhimg.com/80/v2-ab336b8a9c4ea9851c87dcd9b9d7aa42_720w.webp?source=2c26e567)

本文的目标定义在一个 **隐层特征空间（latent space）**中，其表达的语义信息是 **隐层特征空间中有利的转移方向**，即下层控制器的策略需要尽可能让隐层特征朝着目标所表示的方向转移。

针对稀疏奖励问题，本文提出了一个**分层的模块化网络结构**，本针对该网络结构提出了相应的**分层训练方法**。从上图可以看出，FeUdal的网络结构是十分复杂的，它包含一个上层的Manager和一个下层的Worker，其中Manager用于输出goal gg，下层Worker则根据目标输出action。尽管FeUdal网络可以看做一个整体，进行端对端训练。但为了有效学习到目标的语义特征，本文采取了分层训练方法，其中Manager的训练目标是尽可能输出隐层特征空间中有利的转移方向，更新规则类似于策略梯度，而Worker的训练目标则是尽可能达成目标。另外，在网络的设计上，作者也花了许多心思，采取了LSTM、CNN等复杂结构。

与大多数论文将标准RL算法沿用在分层架构中不同，本篇论文直接提出了一种十分复杂的分层网络结构，并通过设计训练方法，赋予了目标明确的语义信息，所有的理论推导和分析都让人感觉十分巧妙！但这种网络结构过于复杂了，实际效果很难被证实，而且从论文中展示出来的实验结果来看，在某些任务中FeUdal的性能甚至比普通的神经网络还要差，这就说明FeUdal的鲁棒性是不太好的，没有性能增益可以理解，但比普通网络还差就？

### **6. HIRO: Data-Efficient Hierarchical Reinforcement Learning**

[![](https://picx.zhimg.com/v2-8da0f9065d6bfe9e5e19ea3fb3af84db.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【分层强化学习】HIRO：一种off-policy的分层强化学习算法19 赞同 · 0 评论](https://zhuanlan.zhihu.com/p/497424021) 文章

![](https://pic1.zhimg.com/80/v2-174bd4e77a456ecc10d38f42d2d19c5a_720w.webp?source=2c26e567)

本文的目标直接定义在**状态空间**，与FeUdal类似，其表达的语义信息是**特征空间中的有利转移方向**，即下层控制器的策略需要尽可能让状态朝着目标所表示的方向转移。

这篇论文的分层思想与FeUdal是十分类似的，只不过HIRO的目标定义在状态空间，而FeUdal的目标定义在隐层特征空间，并且，HIRO没有设计特别复杂的网络结构，而是将标准的RL算法分层化了。本文最大的创新点是针对off-policy的分层强化学习中所存在的 **非平稳（non-stationary）问题** 提出了一种可行的解决方案。这里的非平稳问题指的是，**上层控制器的状态转移概率取决于下层策略**，在off-policy算法中，当上层策略进行更新时，由于下层策略不断更新已经发生了变化，此时回放池中的样本已经不能准确反映当前上层控制器所处的环境，给训练造成了很大的困难。为了解决这一问题，本文提出对经验回放池中的样本进行修正，将原本设定的目标替换成一个新的目标，该目标能够最大化该样本对应轨迹的出现概率，概率的计算公式为

log⁡μlo(at:t+c−1∣st:t+c−1,g~t:t+c−1)∝−12∑i=tt+c−1‖ai−μlo(si,g~i)‖22+ const. \log \mu^{l o}\left(a_{t: t+c-1} \mid s_{t: t+c-1}, \tilde{g}_{t: t+c-1}\right) \propto-\frac{1}{2} \sum_{i=t}^{t+c-1}\left\|a_{i}-\mu^{l o}\left(s_{i}, \tilde{g}_{i}\right)\right\|_{2}^{2}+\text { const. } \\

为了近似得到一个最大值，论文提出选取一定数量的目标来计算上述概率值然后选择其中概率最大的目标作为修订值。

总体来说，HIRO的实现难度比FeUdal应该是小很多的，其针对非平稳问题所提出的解决方案也十分有现实意义，是一篇很不错的论文。

### **7. HAC: Learning Multi-Level Hierachies with Hindsight**

[![](https://pic1.zhimg.com/v2-f80d3c15a66e9d49a67f848858586c15.jpg?source=7e7ef6e2&needBackground=1)XuanAxuan：【分层强化学习】HAC：一种多层级的分层强化学习算法28 赞同 · 3 评论](https://zhuanlan.zhihu.com/p/498703656) 文章

HAC以UVFA和HER为基础，因此其**目标空间即为状态空间，目标就是达到某一特定状态**，当目标实现时奖励为1，否则为0。

与HIRO一样，本文所解决的问题同样是分层强化学习中的 **非平稳问题**，另外，本文还将HER扩展到了分层框架中，解决了分层强化学习中的 **稀疏奖励** 问题。总结来说，本文提出了一个多层级的分层结构，除了最后一层外，每一层均用于输出下一层的目标，这里的目标即为状态空间中较好的状态，因此每个层级的目标就是实现上一层所设定的较好的状态。本文的主要工作是设计了三种不同的transition样本分别用于解决策略更新中存在的不同问题：

- **Hindsight action transitions**：这里的hindsight action指的是将原样本中的action（即下层目标）修正为智能体实际达到的状态，此时该样本就相当于是当下层策略为最优时所产生的样本，而最优策略是独立于不断更新的下层策略的，这样就解决了下层策略变化所导致的 **非平稳问题**；
- **Hindsight goal transitions**：与HER类似，这里的hindsight goal就是指将原样本中的goal（上层目标）修正为该样本对应episode最终所实现的目标，此时就能保证一个episode的样本中总有一个能够获得正奖励，从而解决 **奖励稀疏问题**；
- **Subgoal Testing Transitions**：这里指的是在保证下层策略不更新也不探索的情况下先设定一个目标，然后产生样本，如果在特定时间步之后，该目标没有被满足，就给智能体反馈一个负奖励，这样就能让智能体获得一些较远目标的信息，解决hindsight action transitions与 hindsight goal transitions所导致的部分goal的Q值被忽略的问题。

总体来说，本文的工作还是比较grounded的，针对每个问题都提出了相应的解决方案，并且有理有据。但是本文所针对的场景和HER一样，奖励根据目标是否实现来定义，这是否太局限了一些？

## **总结**

总结而言，无论是基于option的分层强化学习还是基于goal的分层强化学习，都将算法分成了至少两个层级，其中上层控制器根据上层策略输出一个option/goal，而下层控制器则根据上层控制器传递下来的option/goal以及下层策略输出action。Option代表的是一种子策略，而goal则代表的是希望下层策略达成的目标。

在option-critic中，option并没有明确的含义，论文只是规定了option的数量，因此无论是上层控制器还是下层控制器，它们的训练准则都是使环境奖励尽可能大，在上层控制器与下层控制器之间没有任何内部奖励传递，整个网络采取端到端的方式进行训练。

相较而言，goal的含义就要具体得多，每篇论文都赋予了goal不同的语义信息：UVFA、HER与HAC中目标就是实现较好的状态；HDQN中的目标是根据游戏任务人为设计的；FeUdal中目标是隐层特征空间中有利的转移方向；HIRO中目标是状态空间中有利的转移方向。在这些基于goal的分层强化学习中，上层控制器的训练准则是让输出的goal尽可能满足我们所设定的语义信息，即让目标尽可能符合较好的状态/状态转移方向，而下层控制器的训练准则是让环境状态转移尽可能地满足目标，为此，上层控制器会传递给下层控制器一个内部奖励驱动下层控制器完成目标，而上层控制器通常依据外部环境奖励进行训练。因此，上层控制器与下层控制器实际上是分开训练的。通过赋予goal一定的语义信息，同时依据此语义信息设计合理的内部奖励，即便是在外部奖励十分稀疏的情况下，也能够保证下层控制器获得一定的内部激励，从而使得智能体能够更加高效地学习到最优策略，提升样本的使用效率。

写到这里我直觉上觉得option与goal所针对的问题可能是不太一样的，option更像是解决 **复杂任务**，通过把一个十分复杂的策略分解为一些比较简单的子策略，降低任务求解的难度。goal则偏重于解决 **稀疏奖励问题**，通过让智能体同时学习如何搜寻好的状态作为目标，以及如何达到这些目标，通过内部激励的方式促进智能体在稀疏奖励的环境下完成任务。看起来基于goal的方法应该是更为高效的，因为学习制定目标显然比学习制定子策略更为简单，大概这也是为什么基于goal的算法更为主流？

回到我的初衷，思考如何将分层强化学习应用在我的课题无人机通信中，在无人机通信的场景中，通常不存在稀疏奖励的问题，但复杂问题倒是很多，这些复杂问题，我知道它们为什么复杂，我也知道如何将它们分解，也就是说先验知识是很多的，我根本不需要智能体去自动找option或者自动找目标，我自己很明显就知道任务要怎么分解，说白了就是人为将复杂任务分解成简单任务，而并不是像上面算法那样用一下很复杂的手段让智能体自己去找option/goal，这样看来，我应该是没有办法直接用上面的算法了。如果真的要用上面的算法，那我是得去找一个稀疏奖励的环境，这就需要好好动点脑子了。

接下来，我会简单梳理一下我看到的几篇通信领域应用分层强化学习的论文。

## **实际应用中的分层强化学习**

在通信领域，大家应用分层强化学习的方式通常是，将一个比较复杂的动作空间分解成两个较简单的子动作空间，其中包含一个更新频率较低的上层动作，和一个更新频率较低的下层动作，上层控制器用于控制上层策略输出上层动作，而下层控制器用于控制下层策略输出下层动作，两个控制器分开进行训练，上层控制器的奖励是一段时间内的平均环境奖励，下层控制器则直接接收环境奖励。可以看出，这种方法中，上层控制器与下层控制器的关联在于，上层动作和下层动作共同导致环境状态的变化，但是在训练的过程中，两者是没有直接联系的。很多论文都声称自己用了H-DQN框架，但很明显，上层动作根本就不是goal，这种方法也跟H-DQN没有什么关系。如果硬是要把这些应用套上一个已有的分层强化学习算法，可能option框架更为合适，选择一个上层动作，就相当于固定了原动作空间中的一部分，这就很像是选择了一个子策略了，但是与原option框架不同的是，这里的上层动作会与下层动作共同影响环境状态的变化，而在option框架中，只有底层的action会影响环境状态。但是直觉上来看，尽管分层把原本复杂的问题简化了，有利于强化学习的训练，但这种方法相当于把相互关联的几个动作分解成独立的子动作了，也就是把原本应该联合优化的变量分开独立优化了，根据优化理论，这样肯定是会带来性能损失的。所以分层到底能不能给我们的任务带来好处呢？有待进一步讨论与实验~

下面是我看过的分层强化学习应用的论文，带*号的是我觉得应用得比较好的，大家感兴趣的话可以看看：

1. W. Shi, J. Li, H. Wu, C. Zhou, N. Cheng, and X. Shen, ‘Drone-Cell Trajectory Planning and Resource Allocation for Highly Mobile Networks: A Hierarchical DRL Approach’, _IEEE Internet Things J._, vol. 8, no. 12, pp. 9800–9813, Jun. 2021, doi: **[10.1109/JIOT.2020.3020067](https://link.zhihu.com/?target=https%3A//doi.org/10.1109/JIOT.2020.3020067)**.  
    
2. *T. Ren _et al._, ‘Enabling Efficient Scheduling in Large-Scale UAV-Assisted Mobile Edge Computing via Hierarchical Reinforcement Learning’, _IEEE Internet Things J._, pp. 1–1, 2021, doi: **[10.1109/JIOT.2021.3071531](https://link.zhihu.com/?target=https%3A//doi.org/10.1109/JIOT.2021.3071531)**.  
    
3. Y. Zhang, Z. Mou, F. Gao, L. Xing, J. Jiang, and Z. Han, ‘Hierarchical Deep Reinforcement Learning for Backscattering Data Collection With Multiple UAVs’, _IEEE Internet Things J._, vol. 8, no. 5, pp. 3786–3800, Mar. 2021, doi: **[10.1109/JIOT.2020.3024666](https://link.zhihu.com/?target=https%3A//doi.org/10.1109/JIOT.2020.3024666)**.  
    
4. *Y. Geng, E. Liu, R. Wang, and Y. Liu, ‘Hierarchical Reinforcement Learning for Relay Selection and Power Optimization in Two-Hop Cooperative Relay Network’, _IEEE Trans. Commun._, vol. 70, no. 1, pp. 171–184, Jan. 2022, doi: **[10.1109/TCOMM.2021.3119689](https://link.zhihu.com/?target=https%3A//doi.org/10.1109/TCOMM.2021.3119689)**.  
    
5. Y. Al-Eryani and E. Hossain, ‘Self-Organizing mmWave MIMO Cell-Free Networks With Hybrid Beamforming: A Hierarchical DRL-Based Design’, _IEEE Trans. Commun._, pp. 1–1, 2022, doi: **[10.1109/TCOMM.2022.3159836](https://link.zhihu.com/?target=https%3A//doi.org/10.1109/TCOMM.2022.3159836)**.