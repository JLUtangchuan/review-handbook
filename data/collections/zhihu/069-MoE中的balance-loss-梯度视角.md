---
title: "MoE中的balance loss--梯度视角"
author: "王峰"
source_url: https://zhuanlan.zhihu.com/p/1893328591913189877
platform: zhihu
collection: "学习收藏"
collection_url: https://www.zhihu.com/collection/713057152
topic: ""
subtopic: ""
status: pending
---

# MoE中的balance loss--梯度视角

> 作者: 王峰 | 来源: https://zhuanlan.zhihu.com/p/1893328591913189877

---

最近在学习大模型中的MoE，读到balance loss这里时遇到了一些困惑，它的形式非常简单：

L_{aux} = <f, p>=\sum_{i=1}^n{f_i p_i},\tag{1} 其中n是expert个数，p是router输出的概率，f是每个expert在所有token上被topk取到的概率。

初看这个loss时确实摸不着头脑，为什么这样一个内积loss就能使expert均衡化？搜索了一下，在苏神的博客（MoE环游记：2、不患寡而患不均 - 科学空间|Scientific Spaces）中看到了一个解释，通过stop gradient技巧，苏神证明了一个直觉上更“正确”的loss：

L_{aux} =\sum_{i=1}^n{(f_i-\frac{1}{n})^2},\tag{2} 它的梯度与公式(1)的梯度是等价的。

但我还是有一些疑虑，还是不太明白这个loss是如何工作的。俗话说得好，loss给网络带来的是梯度，而loss值本身并不重要。那我们不妨对公式(1)求个梯度看一下：

首先把公式展开，假设 x_i 是logit， p_i 是softmax后的概率：

L = \sum_i f_i p_i = \sum_i f_i \cdot \frac{e^{x_i}}{\sum_j e^{x_j}}. \tag{3} 然后计算梯度 \( \frac{\partial L}{\partial x_k} \) ，这里求导过程就不写了，我直接让deepseek帮我求了，检查了一下推得挺对的：

\frac{\partial L}{\partial x_k} = p_k \left( f_k - \sum_i f_i p_i \right).\tag{4}

这个公式是有一些问题的，首先来看外面乘的系数 p_k ，在一些极端情况下，例如当某个router输出的p为0时，其梯度也为0，与梯度消失的原理有点类似，一旦梯度为0了就会停止更新，可能就再也拉不回去了。

然后再注意到括号内的部分， \sum_i f_i p_i 可以理解为按概率 p 加权平均的 f_i ，如果 f_k 超过了平均值，那么 x_k 会拿到一个正梯度，通过梯度下降会慢慢趋近于平均值，反之亦然。那么随着不断的优化， f_k 的所有项都会逐渐趋于平均，也就达到了balance的目的。

但是要注意到这个softmax的加权平均，它实际上也算是一种max函数的松弛版，它的结果是非常接近最大值的，这也就导致次优值可能会拿到相反的梯度。例如router的logits是[5.5, 4.5, 0, 0]，对应的概率 p 为[0.727, 0.267, 0.003, 0.003]，再假设 f 恰好与 p 相同的话，由于我们期望的 f 的目标是[0.25, 0.25, 0.25, 0.25]，所以应该将前两项都向下拉，后两项向上拉。但softmax加权平均后的结果是 \sum_i f_i p_i \approx0.5996 ，也就是说第二项0.267在这个公式下也会向上拉，背离了我们的初衷。

在deepseek-v3中可能注意到了softmax几乎会只拉低最大的那一个的问题，所以改成了sigmoid并归一化：

p_i = \frac{\sigma(x_i)}{\sum_i \sigma(x_i)} ,\tag{5} 按这个概率求出来的梯度形式为：

\frac{\partial L}{\partial x_k} = p_k (1-\sigma_k)\left( f_k - \sum_i f_i p_i \right).\tag{6}

这个公式跟softmax版的差别在于多了一项 1-\sigma_k ，这一项导致梯度消失问题更严重了，不仅是概率接近0，现在某个sigmoid接近1时，梯度也会消失，而这种情况是很常见的。

至于后面括号内的部分，由于改成了sigmoid函数，p的值变为[0.334, 0.331, 0.168, 0.168]，仍然假设 f 与 p 相同，加权后的均值为 \sum_i f_i p_i \approx0.277 ，所以不再有只拉低最高项的缺点了。我暂时没举出反例，但其实我们的目标就是将 f 的每一项优化到1/n，而不是加权后的均值，所以也不能说这一项是在以最佳的效率来解决问题。

解决这两个问题的思路也挺容易想到，softmax cross entropy为什么如此稳定，就是因为它的梯度形式非常简单，就是 p-q ，其中 p 是网络输出， q 是目标分布。那么我们构造一个类似的损失函数应该就能解决问题，既然我们的目标是让每个 f_i 都接近1/n，那直接安排一个这样的梯度就好了：

L = \sum_i (f_i - \frac{1}{n}) x_i .\tag{7} 这个公式下，梯度就是简简单单的 f_i - \frac{1}{n} ，目标非常明确，也不再会出现还未达到目标时梯度就为0的情况了。

==============================================

@苏剑林 提示我，这个loss形式有一个问题，如果 input_i 在[batch, seqlen]维度上进行了归一化 E[inputs] =0 ，fc层的结果在[batch,seqlen]维度上的均值就成了 E[x_i] = E[inputs] @ w_i ，此时对 w_i 的梯度为：

\frac{dL}{dw_i} = (f_i - 1/n) * E[inputs] = 0
此时也会导致梯度消失，而让input均值为0的归一化是经常会实施的操作，所以这个loss形式依然会带来梯度消失问题。

修改回softmax/sigmoid加权平均的结果，因为input无法预知router概率，所以应该是安全的，那么loss形式变为：

L = \sum_i (f_i - \sum_j f_j p_j) x_i .\tag{8}这个形式应该可以避免输入归一化带来的梯度消失问题，同时也避免了上边提到的因为 p_k 和 \sigma_k 带来的梯度消失问题，实际上与公式(6)相比，这个loss的梯度就是去掉了其中的 p_k 和 1-\sigma_k 两项。


## 图片

![图片](https://pic1.zhimg.com/v2-ddf658f2e6ef81ef4a5c8a6a53e2abf9_l.jpg?source=32738c0c&needBackground=1)

![图片](https://picx.zhimg.com/f9b62596cbdc1162483666249c0791c0_l.jpg?source=32738c0c&needBackground=1)

![图片](https://pica.zhimg.com/v2-4a07bc69c4bb04444721f35b32125c75_l.png?source=32738c0c)

![图片](https://picx.zhimg.com/v2-4812630bc27d642f7cafcd6cdeca3d7a.jpg?source=88ceefae)

![图片](https://picx.zhimg.com/v2-7338da88502f1bb42935373c2f1b86d1_l.jpg?source=06d4cd63)

![图片](https://picx.zhimg.com/b5b300a52_l.jpg?source=06d4cd63)

![图片](https://pic1.zhimg.com/v2-f964d1e37360e554802a3a339432962b_l.jpg?source=06d4cd63)

![图片](https://pica.zhimg.com/v2-b6f53e9726998343e7713f564a422575.png)

![图片](https://pic1.zhimg.com/425aef8a954d08af1ec2a4acb30d5e47_l.jpg?source=06d4cd63)

![图片](https://picx.zhimg.com/f9b62596cbdc1162483666249c0791c0_l.jpg?source=06d4cd63)

![图片](https://pic1.zhimg.com/v2-4a07bc69c4bb04444721f35b32125c75_l.png?source=32738c0c)

![图片](https://picx.zhimg.com/v2-7fe7761b0409fcf2ccb5e137d5f90c39_250x0.jpg?source=172ae18b)

![图片](https://picx.zhimg.com/v2-9228fa5501b92d4c0c8c0617518c8e2d_250x0.jpg?source=172ae18b)

