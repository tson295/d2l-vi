# Adagrad
<a id="sec_adagrad"></a>

Hãy bắt đầu bằng cách xét các bài toán học với những đặc trưng xuất hiện không thường xuyên.


## Đặc Trưng Thưa và Tốc Độ Học

Hãy tưởng tượng chúng ta đang huấn luyện một mô hình ngôn ngữ. Để đạt độ chính xác tốt, thông thường chúng ta muốn giảm tốc độ học khi tiếp tục huấn luyện, thường với tốc độ $\mathcal{O}(t^{-\frac{1}{2}})$ hoặc chậm hơn. Bây giờ xét một mô hình huấn luyện trên các đặc trưng thưa, tức là các đặc trưng chỉ thỉnh thoảng xuất hiện. Điều này phổ biến trong ngôn ngữ tự nhiên, ví dụ khả năng chúng ta thấy từ *preconditioning* thấp hơn nhiều so với từ *learning*. Tuy nhiên, nó cũng phổ biến trong các lĩnh vực khác như quảng cáo tính toán và lọc cộng tác cá nhân hóa. Sau cùng, có nhiều thứ chỉ được một số ít người quan tâm.

Các tham số gắn với những đặc trưng không thường xuyên chỉ nhận được các cập nhật có ý nghĩa mỗi khi các đặc trưng này xuất hiện. Với tốc độ học giảm dần, chúng ta có thể rơi vào tình huống trong đó các tham số cho đặc trưng phổ biến hội tụ khá nhanh đến giá trị tối ưu của chúng, trong khi với đặc trưng không thường xuyên, chúng ta vẫn chưa quan sát chúng đủ thường xuyên trước khi có thể xác định giá trị tối ưu. Nói cách khác, tốc độ học hoặc giảm quá chậm đối với các đặc trưng thường xuyên, hoặc quá nhanh đối với các đặc trưng không thường xuyên.

Một mẹo có thể dùng để khắc phục vấn đề này là đếm số lần chúng ta thấy một đặc trưng cụ thể và dùng nó như một đồng hồ để điều chỉnh tốc độ học. Tức là, thay vì chọn tốc độ học có dạng $\eta = \frac{\eta_0}{\sqrt{t + c}}$, chúng ta có thể dùng $\eta_i = \frac{\eta_0}{\sqrt{s(i, t) + c}}$. Ở đây $s(i, t)$ đếm số phần tử khác không của đặc trưng $i$ mà chúng ta đã quan sát đến thời điểm $t$. Điều này thực ra khá dễ cài đặt mà không có chi phí phụ đáng kể. Tuy nhiên, nó thất bại khi chúng ta không thật sự có tính thưa mà chỉ có dữ liệu trong đó gradient thường rất nhỏ và chỉ hiếm khi lớn. Sau cùng, không rõ nên vạch ranh giới ở đâu giữa thứ đủ điều kiện là một đặc trưng đã quan sát và thứ không đủ điều kiện.

Adagrad của Duchi.Hazan.Singer.2011 xử lý điều này bằng cách thay bộ đếm khá thô $s(i, t)$ bằng một tổng hợp các bình phương của các gradient đã quan sát trước đó. Cụ thể, nó dùng $s(i, t+1) = s(i, t) + \left(\partial_i f(\mathbf{x})\right)^2$ như một cách để điều chỉnh tốc độ học. Điều này có hai lợi ích: thứ nhất, chúng ta không còn cần quyết định chính xác khi nào một gradient đủ lớn. Thứ hai, nó tự động đổi thang theo độ lớn của gradient. Các tọa độ thường xuyên tương ứng với gradient lớn được giảm thang đáng kể, trong khi những tọa độ khác có gradient nhỏ được xử lý nhẹ nhàng hơn nhiều. Trong thực tế, điều này dẫn đến một quy trình tối ưu hóa rất hiệu quả cho quảng cáo tính toán và các bài toán liên quan. Nhưng điều này che giấu một số lợi ích bổ sung vốn có của Adagrad, những lợi ích được hiểu tốt nhất trong bối cảnh tiền điều kiện hóa.


## Tiền Điều Kiện Hóa

Các bài toán tối ưu hóa lồi rất tốt để phân tích đặc tính của thuật toán. Sau cùng, với hầu hết các bài toán không lồi, rất khó dẫn xuất các đảm bảo lý thuyết có ý nghĩa, nhưng *trực giác* và *hiểu biết* thường vẫn được chuyển sang. Hãy xét bài toán tối thiểu hóa $f(\mathbf{x}) = \frac{1}{2} \mathbf{x}^\top \mathbf{Q} \mathbf{x} + \mathbf{c}^\top \mathbf{x} + b$.

Như đã thấy trong [sec_momentum](#sec_momentum), có thể viết lại bài toán này theo phân rã riêng $\mathbf{Q} = \mathbf{U}^\top \boldsymbol{\Lambda} \mathbf{U}$ để thu được một bài toán đơn giản hơn nhiều, trong đó mỗi tọa độ có thể được giải riêng:

$$f(\mathbf{x}) = \bar{f}(\bar{\mathbf{x}}) = \frac{1}{2} \bar{\mathbf{x}}^\top \boldsymbol{\Lambda} \bar{\mathbf{x}} + \bar{\mathbf{c}}^\top \bar{\mathbf{x}} + b.$$

Ở đây chúng ta dùng $\bar{\mathbf{x}} = \mathbf{U} \mathbf{x}$ và do đó $\bar{\mathbf{c}} = \mathbf{U} \mathbf{c}$. Bài toán đã sửa đổi có bộ tối thiểu hóa $\bar{\mathbf{x}} = -\boldsymbol{\Lambda}^{-1} \bar{\mathbf{c}}$ và giá trị nhỏ nhất $-\frac{1}{2} \bar{\mathbf{c}}^\top \boldsymbol{\Lambda}^{-1} \bar{\mathbf{c}} + b$. Điều này dễ tính hơn nhiều vì $\boldsymbol{\Lambda}$ là một ma trận đường chéo chứa các trị riêng của $\mathbf{Q}$.

Nếu làm nhiễu $\mathbf{c}$ một chút, chúng ta hy vọng chỉ thấy các thay đổi nhỏ trong bộ tối thiểu hóa của $f$. Đáng tiếc là không phải vậy. Mặc dù các thay đổi nhỏ trong $\mathbf{c}$ dẫn đến các thay đổi nhỏ tương ứng trong $\bar{\mathbf{c}}$, điều này không đúng với bộ tối thiểu hóa của $f$ (và tương ứng của $\bar{f}$). Bất cứ khi nào các trị riêng $\boldsymbol{\Lambda}_i$ lớn, chúng ta chỉ thấy các thay đổi nhỏ trong $\bar{x}_i$ và trong cực tiểu của $\bar{f}$. Ngược lại, với $\boldsymbol{\Lambda}_i$ nhỏ, các thay đổi trong $\bar{x}_i$ có thể rất lớn. Tỷ số giữa trị riêng lớn nhất và nhỏ nhất được gọi là số điều kiện của một bài toán tối ưu hóa.

$$\kappa = \frac{\boldsymbol{\Lambda}_1}{\boldsymbol{\Lambda}_d}.$$

Nếu số điều kiện $\kappa$ lớn, rất khó giải chính xác bài toán tối ưu hóa. Chúng ta cần đảm bảo cẩn thận để xử lý đúng một dải động lớn của các giá trị. Phân tích của chúng ta dẫn đến một câu hỏi hiển nhiên, dù hơi ngây thơ: chẳng lẽ không thể đơn giản "sửa" bài toán bằng cách làm méo không gian sao cho mọi trị riêng đều là $1$ hay sao? Về lý thuyết, điều này khá dễ: chúng ta chỉ cần các trị riêng và vector riêng của $\mathbf{Q}$ để đổi thang bài toán từ $\mathbf{x}$ sang một bài toán theo $\mathbf{z} \stackrel{\textrm{def}}{=} \boldsymbol{\Lambda}^{\frac{1}{2}} \mathbf{U} \mathbf{x}$. Trong hệ tọa độ mới, $\mathbf{x}^\top \mathbf{Q} \mathbf{x}$ có thể được đơn giản hóa thành $\|\mathbf{z}\|^2$. Tiếc là đây là một đề xuất khá không thực tế. Tính trị riêng và vector riêng nói chung *đắt hơn nhiều* so với giải bài toán thực tế.

Mặc dù tính chính xác trị riêng có thể tốn kém, việc đoán chúng và tính chúng thậm chí chỉ gần đúng phần nào đã có thể tốt hơn nhiều so với không làm gì. Cụ thể, chúng ta có thể dùng các phần tử đường chéo của $\mathbf{Q}$ và đổi thang tương ứng. Điều này *rẻ hơn nhiều* so với tính trị riêng.

$$\tilde{\mathbf{Q}} = \textrm{diag}^{-\frac{1}{2}}(\mathbf{Q}) \mathbf{Q} \textrm{diag}^{-\frac{1}{2}}(\mathbf{Q}).$$

Trong trường hợp này, chúng ta có $\tilde{\mathbf{Q}}_{ij} = \mathbf{Q}_{ij} / \sqrt{\mathbf{Q}_{ii} \mathbf{Q}_{jj}}$ và cụ thể $\tilde{\mathbf{Q}}_{ii} = 1$ với mọi $i$. Trong hầu hết các trường hợp, điều này đơn giản hóa số điều kiện đáng kể. Chẳng hạn, với các trường hợp đã thảo luận trước đó, nó sẽ loại bỏ hoàn toàn bài toán đang xét vì bài toán được căn theo các trục.

Đáng tiếc là chúng ta lại đối mặt một vấn đề khác: trong deep learning, thông thường chúng ta thậm chí không có quyền truy cập đạo hàm bậc hai của hàm mục tiêu: với $\mathbf{x} \in \mathbb{R}^d$, đạo hàm bậc hai ngay cả trên một minibatch có thể cần $\mathcal{O}(d^2)$ không gian và công tính toán, khiến nó không khả thi trong thực tế. Ý tưởng khéo léo của Adagrad là dùng một đại diện thay thế cho đường chéo khó nắm bắt đó của Hessian, vừa tương đối rẻ để tính vừa hiệu quả, đó là độ lớn của chính gradient.

Để thấy vì sao điều này hoạt động, hãy xét $\bar{f}(\bar{\mathbf{x}})$. Chúng ta có

$$\partial_{\bar{\mathbf{x}}} \bar{f}(\bar{\mathbf{x}}) = \boldsymbol{\Lambda} \bar{\mathbf{x}} + \bar{\mathbf{c}} = \boldsymbol{\Lambda} \left(\bar{\mathbf{x}} - \bar{\mathbf{x}}_0\right),$$

trong đó $\bar{\mathbf{x}}_0$ là bộ tối thiểu hóa của $\bar{f}$. Do đó, độ lớn của gradient phụ thuộc cả vào $\boldsymbol{\Lambda}$ và khoảng cách đến nghiệm tối ưu. Nếu $\bar{\mathbf{x}} - \bar{\mathbf{x}}_0$ không thay đổi, đây sẽ là tất cả những gì cần thiết. Sau cùng, trong trường hợp này độ lớn của gradient $\partial_{\bar{\mathbf{x}}} \bar{f}(\bar{\mathbf{x}})$ là đủ. Vì AdaGrad là một thuật toán stochastic gradient descent, chúng ta sẽ thấy các gradient có phương sai khác không ngay cả tại nghiệm tối ưu. Kết quả là, chúng ta có thể an toàn dùng phương sai của các gradient như một đại diện thay thế rẻ cho thang đo của Hessian. Một phân tích kỹ lưỡng vượt quá phạm vi phần này (nó sẽ dài vài trang). Chúng tôi giới thiệu độc giả đến [Duchi.Hazan.Singer.2011] để biết chi tiết.

## Thuật Toán

Hãy hình thức hóa thảo luận ở trên. Chúng ta dùng biến $\mathbf{s}_t$ để tích lũy phương sai gradient trong quá khứ như sau.

$$\begin{aligned}
    \mathbf{g}_t & = \partial_{\mathbf{w}} l(y_t, f(\mathbf{x}_t, \mathbf{w})), \\
    \mathbf{s}_t & = \mathbf{s}_{t-1} + \mathbf{g}_t^2, \\
    \mathbf{w}_t & = \mathbf{w}_{t-1} - \frac{\eta}{\sqrt{\mathbf{s}_t + \epsilon}} \cdot \mathbf{g}_t.
\end{aligned}$$

Ở đây các phép toán được áp dụng theo từng tọa độ. Tức là, $\mathbf{v}^2$ có các phần tử $v_i^2$. Tương tự, $\frac{1}{\sqrt{v}}$ có các phần tử $\frac{1}{\sqrt{v_i}}$ và $\mathbf{u} \cdot \mathbf{v}$ có các phần tử $u_i v_i$. Như trước, $\eta$ là tốc độ học và $\epsilon$ là một hằng số cộng thêm để đảm bảo chúng ta không chia cho $0$. Cuối cùng, chúng ta khởi tạo $\mathbf{s}_0 = \mathbf{0}$.

Giống như trong trường hợp momentum, chúng ta cần theo dõi một biến phụ, trong trường hợp này để cho phép mỗi tọa độ có một tốc độ học riêng. Điều này không làm tăng đáng kể chi phí của Adagrad so với SGD, đơn giản vì chi phí chính thường là tính $l(y_t, f(\mathbf{x}_t, \mathbf{w}))$ và đạo hàm của nó.

Lưu ý rằng tích lũy bình phương gradient trong $\mathbf{s}_t$ có nghĩa là $\mathbf{s}_t$ về cơ bản tăng với tốc độ tuyến tính (trong thực tế chậm hơn tuyến tính một chút, vì gradient ban đầu giảm). Điều này dẫn đến tốc độ học $\mathcal{O}(t^{-\frac{1}{2}})$, dù được điều chỉnh theo từng tọa độ. Với các bài toán lồi, điều này hoàn toàn phù hợp. Tuy nhiên, trong deep learning, chúng ta có thể muốn giảm tốc độ học chậm hơn. Điều này dẫn đến một số biến thể Adagrad mà chúng ta sẽ thảo luận trong các chương tiếp theo. Hiện tại, hãy xem nó hành xử thế nào trong một bài toán bậc hai lồi. Chúng ta dùng cùng bài toán như trước:

$$f(\mathbf{x}) = 0.1 x_1^2 + 2 x_2^2.$$

Chúng ta sẽ cài đặt Adagrad bằng cùng tốc độ học như trước, tức là $\eta = 0.4$. Như có thể thấy, quỹ đạo lặp của biến độc lập trơn hơn. Tuy nhiên, do hiệu ứng tích lũy của $\boldsymbol{s}_t$, tốc độ học liên tục suy giảm, nên biến độc lập không di chuyển nhiều ở các giai đoạn lặp sau.

```python
#@tab mxnet
%matplotlib inline
from d2l import mxnet as d2l
import math
from mxnet import np, npx
npx.set_np()
```

```python
#@tab pytorch
%matplotlib inline
from d2l import torch as d2l
import math
import torch
```

```python
#@tab tensorflow
%matplotlib inline
from d2l import tensorflow as d2l
import math
import tensorflow as tf
```

```python
#@tab all
def adagrad_2d(x1, x2, s1, s2):
    eps = 1e-6
    g1, g2 = 0.2 * x1, 4 * x2
    s1 += g1 ** 2
    s2 += g2 ** 2
    x1 -= eta / math.sqrt(s1 + eps) * g1
    x2 -= eta / math.sqrt(s2 + eps) * g2
    return x1, x2, s1, s2

def f_2d(x1, x2):
    return 0.1 * x1 ** 2 + 2 * x2 ** 2

eta = 0.4
d2l.show_trace_2d(f_2d, d2l.train_2d(adagrad_2d))
```

Khi tăng tốc độ học lên $2$, chúng ta thấy hành vi tốt hơn nhiều. Điều này đã cho thấy mức giảm tốc độ học có thể khá mạnh, ngay cả trong trường hợp không nhiễu, và chúng ta cần đảm bảo các tham số hội tụ phù hợp.

```python
#@tab all
eta = 2
d2l.show_trace_2d(f_2d, d2l.train_2d(adagrad_2d))
```

## Cài Đặt Từ Đầu

Giống như phương pháp momentum, Adagrad cần duy trì một biến trạng thái có cùng hình dạng với các tham số.

```python
#@tab mxnet
def init_adagrad_states(feature_dim):
    s_w = d2l.zeros((feature_dim, 1))
    s_b = d2l.zeros(1)
    return (s_w, s_b)

def adagrad(params, states, hyperparams):
    eps = 1e-6
    for p, s in zip(params, states):
        s[:] += np.square(p.grad)
        p[:] -= hyperparams['lr'] * p.grad / np.sqrt(s + eps)
```

```python
#@tab pytorch
def init_adagrad_states(feature_dim):
    s_w = d2l.zeros((feature_dim, 1))
    s_b = d2l.zeros(1)
    return (s_w, s_b)

def adagrad(params, states, hyperparams):
    eps = 1e-6
    for p, s in zip(params, states):
        with torch.no_grad():
            s[:] += torch.square(p.grad)
            p[:] -= hyperparams['lr'] * p.grad / torch.sqrt(s + eps)
        p.grad.data.zero_()
```

```python
#@tab tensorflow
def init_adagrad_states(feature_dim):
    s_w = tf.Variable(d2l.zeros((feature_dim, 1)))
    s_b = tf.Variable(d2l.zeros(1))
    return (s_w, s_b)

def adagrad(params, grads, states, hyperparams):
    eps = 1e-6
    for p, s, g in zip(params, states, grads):
        s[:].assign(s + tf.math.square(g))
        p[:].assign(p - hyperparams['lr'] * g / tf.math.sqrt(s + eps))
```

So với thí nghiệm trong [sec_minibatch_sgd](#sec_minibatch_sgd), chúng ta dùng một
tốc độ học lớn hơn để huấn luyện mô hình.

```python
#@tab all
data_iter, feature_dim = d2l.get_data_ch11(batch_size=10)
d2l.train_ch11(adagrad, init_adagrad_states(feature_dim),
               {'lr': 0.1}, data_iter, feature_dim);
```

## Cài Đặt Ngắn Gọn

Dùng thể hiện `Trainer` của thuật toán `adagrad`, chúng ta có thể gọi thuật toán Adagrad trong Gluon.

```python
#@tab mxnet
d2l.train_concise_ch11('adagrad', {'learning_rate': 0.1}, data_iter)
```

```python
#@tab pytorch
trainer = torch.optim.Adagrad
d2l.train_concise_ch11(trainer, {'lr': 0.1}, data_iter)
```

```python
#@tab tensorflow
trainer = tf.keras.optimizers.Adagrad
d2l.train_concise_ch11(trainer, {'learning_rate' : 0.1}, data_iter)
```

## Tóm Tắt

* Adagrad giảm tốc độ học động theo từng tọa độ.
* Nó dùng độ lớn của gradient như một cách điều chỉnh tốc độ đạt được tiến triển - các tọa độ có gradient lớn được bù bằng tốc độ học nhỏ hơn.
* Việc tính đạo hàm bậc hai chính xác thường không khả thi trong các bài toán deep learning do các ràng buộc về bộ nhớ và tính toán. Gradient có thể là một đại diện thay thế hữu ích.
* Nếu bài toán tối ưu hóa có cấu trúc khá không đều, Adagrad có thể giúp giảm méo.
* Adagrad đặc biệt hiệu quả cho các đặc trưng thưa, nơi tốc độ học cần giảm chậm hơn với các hạng xuất hiện không thường xuyên.
* Trên các bài toán deep learning, Adagrad đôi khi có thể quá mạnh tay trong việc giảm tốc độ học. Chúng ta sẽ thảo luận các chiến lược giảm nhẹ điều này trong bối cảnh [sec_adam](#sec_adam).

## Bài Tập

1. Chứng minh rằng với một ma trận trực giao $\mathbf{U}$ và một vector $\mathbf{c}$, điều sau đúng: $\|\mathbf{c} - \mathbf{\delta}\|_2 = \|\mathbf{U} \mathbf{c} - \mathbf{U} \mathbf{\delta}\|_2$. Vì sao điều này có nghĩa là độ lớn của nhiễu không thay đổi sau một phép đổi biến trực giao?
1. Thử Adagrad cho $f(\mathbf{x}) = 0.1 x_1^2 + 2 x_2^2$ và cả cho hàm mục tiêu được xoay 45 độ, tức là $f(\mathbf{x}) = 0.1 (x_1 + x_2)^2 + 2 (x_1 - x_2)^2$. Nó có hành xử khác không?
1. Chứng minh [định lý vòng tròn Gerschgorin](https://en.wikipedia.org/wiki/Gershgorin_circle_theorem), phát biểu rằng các trị riêng $\lambda_i$ của một ma trận $\mathbf{M}$ thỏa $|\lambda_i - \mathbf{M}_{jj}| \leq \sum_{k \neq j} |\mathbf{M}_{jk}|$ với ít nhất một lựa chọn của $j$.
1. Định lý Gerschgorin cho chúng ta biết gì về các trị riêng của ma trận được tiền điều kiện hóa theo đường chéo $\textrm{diag}^{-\frac{1}{2}}(\mathbf{M}) \mathbf{M} \textrm{diag}^{-\frac{1}{2}}(\mathbf{M})$?
1. Thử Adagrad cho một mạng sâu đúng nghĩa, chẳng hạn [sec_lenet](#sec_lenet) khi áp dụng cho Fashion-MNIST.
1. Bạn cần sửa Adagrad như thế nào để đạt được mức suy giảm tốc độ học ít mạnh hơn?


[Discussions](https://discuss.d2l.ai/t/1072)
